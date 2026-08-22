"""
AstraChat Agent с поддержкой llm-svc
Модифицированная версия agent.py для работы через llm-svc API
"""

# Настройка кодировки для Windows
import sys
import os
from backend.settings.logging import get_logger

# Импортируем утилиту для исправления кодировки
try:
    from utils.encoding_fix import fix_windows_encoding, safe_print
    fix_windows_encoding()
except ImportError:
    # Если утилита недоступна, используем базовую настройку
    if sys.platform == "win32":
        os.system("chcp 65001 >nul 2>&1")
        if hasattr(sys.stdout, 'reconfigure'):
            sys.stdout.reconfigure(encoding='utf-8')
        if hasattr(sys.stderr, 'reconfigure'):
            sys.stderr.reconfigure(encoding='utf-8')

import json
import logging
import asyncio
from typing import List, Dict, Any, Optional, Callable
from config import get_path

# Импорт путей и настроек
try:
    from backend.config import get_path
    MODEL_PATH = get_path("model_path")
    from backend.context_prompts import context_prompt_manager
    from backend.llm_client import (
        ask_agent_llm_svc,
        get_llm_service,
        resolve_llm_svc_model_id_for_request,
        resolve_llm_host_and_model_for_svc,
    )
except ImportError:
    from config import get_path
    MODEL_PATH = get_path("model_path")
    from context_prompts import context_prompt_manager
    from llm_client import (
        ask_agent_llm_svc,
        get_llm_service,
        resolve_llm_svc_model_id_for_request,
        resolve_llm_host_and_model_for_svc,
    )

# Настройка логирования с поддержкой UTF-8
logger = get_logger(__name__)

# Настройка кодировки для обработчиков логирования
for handler in logging.root.handlers:
    if hasattr(handler, 'stream') and hasattr(handler.stream, 'reconfigure'):
        handler.stream.reconfigure(encoding='utf-8')

# Класс для хранения настроек модели (совместимость)
class ModelSettings:
    def __init__(self):
        self.settings_file = os.path.join(os.path.dirname(os.path.dirname(__file__)), "llm_settings.json")
        # Настройки модели по умолчанию
        self.default_settings = {
            "context_size": 8192,
            "output_tokens": 1024,
            "batch_size": 512,
            "n_threads": 12,
            "use_mmap": True,
            "use_mlock": False,
            "verbose": True,
            "temperature": 0.7,
            "top_p": 0.95,
            "repeat_penalty": 1.05,
            "top_k": 40,
            "min_p": 0.05,
            "frequency_penalty": 0.0,
            "presence_penalty": 0.0,
            "use_gpu": True,
            "streaming": True,
            "legacy_api": False
        }
        self.settings = self.default_settings.copy()
        self.load_settings()
    
    def load_settings(self):
        """Загрузка настроек из файла"""
        try:
            if os.path.exists(self.settings_file):
                with open(self.settings_file, 'r', encoding='utf-8') as f:
                    loaded_settings = json.load(f)
                    self.settings.update(loaded_settings)
                print("Настройки модели загружены")
        except Exception as e:
            print(f"Ошибка при загрузке настроек модели: {str(e)}")
    
    def save_settings(self):
        """Сохранение настроек в файл"""
        try:
            with open(self.settings_file, 'w', encoding='utf-8') as f:
                json.dump(self.settings, f, indent=2, ensure_ascii=False)
            print("Настройки модели сохранены")
        except Exception as e:
            print(f"Ошибка при сохранении настроек модели: {str(e)}")
    
    def get(self, key, default=None):
        """Получение значения настройки"""
        return self.settings.get(key, default)
    
    def set(self, key, value):
        """Установка значения настройки"""
        if key in self.settings:
            self.settings[key] = value
            self.save_settings()
            return True
        return False
    
    def reset_to_defaults(self):
        """Сброс настроек к рекомендуемым значениям по умолчанию"""
        self.settings = self.default_settings.copy()
        self.save_settings()
        print("Настройки сброшены к рекомендуемым значениям")
    
    def get_recommended_settings(self):
        """Получение рекомендуемых настроек (без применения)"""
        return self.default_settings.copy()
    
    def get_max_values(self):
        """Получение максимальных значений для настроек"""
        return {
            "context_size": 32768,
            "output_tokens": 100000,  # Увеличено для снятия ограничения на длину генерации
            "batch_size": 2048,
            "n_threads": 24,
            "temperature": 2.0,
            "top_p": 1.0,
            "repeat_penalty": 2.0,
            "top_k": 200,
            "min_p": 1.0,
            "frequency_penalty": 2.0,
            "presence_penalty": 2.0
        }
    
    def get_all(self):
        """Получение всех настроек"""
        return self.settings.copy()

# Создаем экземпляр класса настроек
model_settings = ModelSettings()

# Настройки модели
MODEL_CONTEXT_SIZE = model_settings.get("context_size")
DEFAULT_OUTPUT_TOKENS = model_settings.get("output_tokens")
VERBOSE_OUTPUT = model_settings.get("verbose")

# Флаг использования llm-svc
USE_LLM_SVC = True  # Переключатель между прямой работой с llama-cpp и llm-svc

def initialize_model():
    """Инициализация модели (теперь через llm-svc)"""
    if USE_LLM_SVC:
        logger.info("Инициализация через llm-svc...")
        try:
            import asyncio
            # Инициализируем llm-svc сервис
            loop = asyncio.get_event_loop()
            if loop.is_running():
                # Если loop уже запущен, создаем новый в отдельном потоке
                import concurrent.futures
                with concurrent.futures.ThreadPoolExecutor() as executor:
                    future = executor.submit(asyncio.run, get_llm_service())
                    service = future.result()
            else:
                service = loop.run_until_complete(get_llm_service())
            
            logger.info("llm-svc сервис инициализирован успешно")
            return True
        except Exception as e:
            logger.error(f"Ошибка инициализации llm-svc: {e}")
            return False
    else:
        # Fallback к оригинальной инициализации
        logger.info("Используется оригинальная инициализация модели")
        return True

def update_model_settings(new_settings):
    """Обновление настроек модели"""
    global model_settings, MODEL_CONTEXT_SIZE, DEFAULT_OUTPUT_TOKENS, VERBOSE_OUTPUT
    
    # Обновляем настройки
    for key, value in new_settings.items():
        model_settings.set(key, value)
    
    # Обновляем глобальные переменные
    MODEL_CONTEXT_SIZE = model_settings.get("context_size")
    DEFAULT_OUTPUT_TOKENS = model_settings.get("output_tokens")
    VERBOSE_OUTPUT = model_settings.get("verbose")
    
    logger.info("Настройки модели обновлены")
    return True

# Глобальная переменная для хранения выбранной модели
_selected_model_name = None

def reload_model_by_path(model_path):
    """Перезагрузка модели с новым файлом модели (через llm-svc)"""
    global _selected_model_name
    
    if USE_LLM_SVC:
        # Новый multi-provider путь: для non-hot-swap провайдеров (vLLM/OpenAI-compat)
        # не вызываем /v1/models/load, просто валидируем model_id через provider API.
        try:
            async def _ensure_for_provider_path():
                from backend.llm_providers import get_registry
                registry = await get_registry()
                provider, model_id = registry.resolve(model_path)
                raw_path = str(model_path or "").strip()
                if not model_id:
                    # Если пришел только provider id (например "CORSUR"), попробуем
                    # выбрать первую доступную модель этого провайдера.
                    if raw_path and registry.contains(raw_path):
                        provider = registry.get(raw_path)
                        candidates = await provider.list_models()
                        if not candidates:
                            return False
                        model_id = str(candidates[0].model_id or "").strip()
                        if not model_id:
                            return False
                    else:
                        return False
                ok = await provider.ensure_model_loaded(model_id)
                if ok:
                    global _selected_model_name
                    _selected_model_name = f"{provider.id}/{model_id}"
                return ok

            if isinstance(model_path, str) and model_path.strip() and not model_path.startswith("llm-svc://"):
                try:
                    loop = asyncio.get_event_loop()
                except RuntimeError:
                    loop = asyncio.new_event_loop()
                    asyncio.set_event_loop(loop)
                if loop.is_running():
                    import concurrent.futures
                    with concurrent.futures.ThreadPoolExecutor() as executor:
                        future = executor.submit(asyncio.run, _ensure_for_provider_path())
                        return future.result()
                return loop.run_until_complete(_ensure_for_provider_path())
        except Exception as e:
            logger.debug(f"provider-path reload fallback to llm-svc logic: {e}")

        # Проверяем, что путь не является директорией
        if os.path.isdir(model_path):
            logger.warning(f"Передан путь к директории вместо файла модели: {model_path}. Пропускаем загрузку.")
            return False
        
        # Проверяем, является ли путь llm-svc путем
        if model_path.startswith("llm-svc://"):
            # Извлекаем host/model из пути (многосерверный режим: llm-svc://host_id/model_id)
            model_name = model_path.replace("llm-svc://", "").strip()
            if not model_name:
                logger.warning("llm-svc: пустое имя модели в пути")
                return False
            _selected_model_name = model_name
            # Запрашиваем llm-svc реально переключить загруженную модель (веса)
            try:
                async def _load_on_llm_svc():
                    service = await get_llm_service()
                    hid, mid = resolve_llm_host_and_model_for_svc(
                        model_path,
                        service.model_name,
                        service.client.llm_hosts,
                        service.client.default_llm_host,
                    )
                    if not mid:
                        logger.warning("llm-svc: не удалось определить id модели из пути")
                        return False
                    ok = await service.client.load_model_if_needed(mid, host_id=hid)
                    if ok:
                        service.model_name = mid
                        logger.info(f"[llm-svc] Обновлён model_name в бэкенде: {mid!r} (host={hid!r})")
                    return ok
                try:
                    loop = asyncio.get_event_loop()
                except RuntimeError:
                    loop = asyncio.new_event_loop()
                    asyncio.set_event_loop(loop)
                if loop.is_running():
                    import concurrent.futures
                    with concurrent.futures.ThreadPoolExecutor() as executor:
                        future = executor.submit(asyncio.run, _load_on_llm_svc())
                        return future.result()
                else:
                    return loop.run_until_complete(_load_on_llm_svc())
            except Exception as e:
                logger.exception(f"Ошибка переключения модели в llm-svc: {e}")
                return False
        
        # Если путь к локальному файлу, но мы используем llm-svc, предупреждаем
        if os.path.exists(model_path) and model_path.endswith('.gguf'):
            logger.warning(f"Передан путь к локальному файлу модели {model_path}, но используется llm-svc. Модель должна быть доступна через llm-svc.")
            return True

        # models/<id> (multi-llm и т.п.) — реально переключаем веса в llm-svc
        resolved_id = resolve_llm_svc_model_id_for_request(model_path, "")
        if resolved_id:
            try:
                async def _load_resolved():
                    service = await get_llm_service()
                    hid, mid = resolve_llm_host_and_model_for_svc(
                        model_path,
                        service.model_name,
                        service.client.llm_hosts,
                        service.client.default_llm_host,
                    )
                    use_id = mid or resolved_id
                    ok = await service.client.load_model_if_needed(use_id, host_id=hid)
                    if ok:
                        service.model_name = use_id
                        global _selected_model_name
                        _selected_model_name = use_id
                        logger.info(
                            f"[llm-svc] Multi-LLM: модель готова к вызову {resolved_id!r} (путь {model_path!r})"
                        )
                    return ok

                try:
                    loop = asyncio.get_event_loop()
                except RuntimeError:
                    loop = asyncio.new_event_loop()
                    asyncio.set_event_loop(loop)
                if loop.is_running():
                    import concurrent.futures
                    with concurrent.futures.ThreadPoolExecutor() as executor:
                        future = executor.submit(asyncio.run, _load_resolved())
                        return future.result()
                return loop.run_until_complete(_load_resolved())
            except Exception as e:
                logger.exception(f"Ошибка load_model для {resolved_id!r}: {e}")
                return False

        logger.info(f"Перезагрузка модели через llm-svc: {model_path}")
        logger.info("Для смены модели в llm-svc обновите конфигурацию и перезапустите сервис")
        return True
    else:
        # Fallback к оригинальной логике
        logger.info("Используется оригинальная перезагрузка модели")
        return True

def get_model_info():
    """Получение информации о текущей модели (через llm-svc)"""
    global _selected_model_name
    
    if USE_LLM_SVC:
        try:
            import asyncio
            
            async def _get_model_info_async():
                """Вспомогательная асинхронная функция для получения информации о модели"""
                service = await get_llm_service()
                ref = f"llm-svc://{_selected_model_name.strip()}" if _selected_model_name else None
                hid, _ = resolve_llm_host_and_model_for_svc(
                    ref,
                    service.model_name,
                    service.client.llm_hosts,
                    service.client.default_llm_host,
                )
                health = await service.client.health_check(host_id=hid)
                return service, health
            
            # Получаем event loop
            try:
                loop = asyncio.get_event_loop()
            except RuntimeError:
                loop = asyncio.new_event_loop()
                asyncio.set_event_loop(loop)
            
            # Выполняем асинхронную функцию
            if loop.is_running():
                # Если loop уже запущен, используем ThreadPoolExecutor
                import concurrent.futures
                with concurrent.futures.ThreadPoolExecutor() as executor:
                    future = executor.submit(asyncio.run, _get_model_info_async())
                    service, health = future.result()
            else:
                # Если loop не запущен, используем run_until_complete
                service, health = loop.run_until_complete(_get_model_info_async())
            
            if health and health.get("status") == "healthy":
                # Используем выбранную модель, если она есть, иначе используем модель из health
                if _selected_model_name:
                    model_name = _selected_model_name
                    model_path = f"llm-svc://{_selected_model_name}"
                else:
                    model_name = health.get("model_name") or getattr(service, "model_name", "Unknown")
                    model_path = ""
                
                return {
                    "loaded": health.get("model_loaded", True),
                    "name": model_name if model_path else "Модель не загружена",
                    "metadata": {
                        "general.name": model_name,
                        "general.architecture": "LLM-SVC",
                        "general.size_label": "Unknown"
                    },
                    "path": model_path,
                    "n_ctx": MODEL_CONTEXT_SIZE,
                    "n_gpu_layers": 0
                }
            else:
                return {
                    "loaded": False,
                    "error": "llm-svc недоступен",
                    "path": ""
                }
        except Exception as e:
            logger.error(f"Ошибка получения информации о модели: {e}")
            return {
                "loaded": False,
                "error": str(e),
                "path": ""
            }
    else:
        # Fallback к оригинальной логике
        return {
            "loaded": True,
            "metadata": {"general.name": "Local Model"},
            "path": MODEL_PATH
        }

def prepare_prompt(text, system_prompt=None, history=None, model_path=None, custom_prompt_id=None):
    """Подготовка промпта в правильном формате с поддержкой истории диалога и контекстных промптов"""
    # Не мержим singleton поверх уже собранного system_prompt (утечка чужих/seed инструкций).
    if system_prompt is None:
        if model_path:
            system_prompt = context_prompt_manager.get_effective_prompt(model_path, custom_prompt_id)
        else:
            system_prompt = context_prompt_manager.get_global_prompt()
    
    # Базовый шаблон для чата
    prompt_parts = []
    
    # Добавляем системный промпт только если он не пустой
    if system_prompt and system_prompt.strip():
        prompt_parts.append(f"<|im_start|>system\n{system_prompt}\n<|im_end|>")
    
    # Добавляем историю диалога, если она есть
    if history:
        for entry in history:
            role = entry.get("role", "user")
            content = entry.get("content", "")
            if role == "user":
                prompt_parts.append(f"<|im_start|>user\n{content}\n<|im_end|>")
            elif role == "assistant":
                prompt_parts.append(f"<|im_start|>assistant\n{content}\n<|im_end|>")
    
    # Добавляем текущий запрос пользователя
    prompt_parts.append(f"<|im_start|>user\n{text.strip()}\n<|im_end|>")
    prompt_parts.append("<|im_start|>assistant\n")
    
    return "".join(prompt_parts)

def ask_agent(
    prompt,
    history=None,
    max_tokens=None,
    streaming=False,
    stream_callback=None,
    model_path=None,
    custom_prompt_id=None,
    images=None,
    system_prompt=None,
    temperature=None,
    enable_thinking=None,
    service_call=False,
):
    """
    Единая точка LLM для legacy callers.

    ``service_call=True`` — ответ читает код, а не человек (исправление опечаток,
    multi-query, HyDE, суммаризация при индексации, judge). Для таких вызовов
    выключается мышление: reasoning-модель иначе тратит весь бюджет токенов на
    рассуждение.

    - CORSUR / Phoenix / llm-svc в ``llm_providers`` → ProviderRegistry
    - ``llm-svc://…``, vision (images) → ``ask_agent_llm_svc`` / ``generate_response``
    - MCP agent loop всегда идёт через registry отдельно (не через эту функцию)
    """
    from backend.llm_providers.routing import (
        format_llm_http_error,
        registry_response_usable,
        service_min_max_tokens,
        should_use_llm_svc_direct,
    )
    import httpx
    from backend.services.user_llm_settings import get_active_model_settings

    eff_max_tokens = max_tokens or get_active_model_settings().get("output_tokens") or 1024
    eff_temperature = float(
        temperature if temperature is not None else get_active_model_settings().get("temperature") or 0.7
    )
    # Не мержим процессный singleton поверх уже собранного system_prompt.
    if system_prompt is None:
        try:
            ctx_prompt = (
                context_prompt_manager.get_effective_prompt(model_path, custom_prompt_id)
                if model_path
                else context_prompt_manager.get_global_prompt()
            )
            ctx_prompt = (ctx_prompt or "").strip()
            system_prompt = ctx_prompt or None
        except Exception:
            logger.exception("ask_agent: не удалось получить контекстные инструкции")
    # Служебные вызовы: гасим мышление и поднимаем min max_tokens (страховка 01.08).
    eff_enable_thinking = bool(enable_thinking)
    if service_call and not eff_enable_thinking:
        eff_enable_thinking = False
        eff_max_tokens = max(int(eff_max_tokens or 0), service_min_max_tokens())

    if not should_use_llm_svc_direct(model_path=model_path, images=images):
        try:
            from backend.mcp.orchestrator_bridge import sync_chat_via_registry

            registry_response = sync_chat_via_registry(
                prompt,
                history=history,
                model_path=model_path,
                streaming=streaming,
                stream_callback=stream_callback,
                max_tokens=eff_max_tokens,
                temperature=eff_temperature,
                system_prompt=system_prompt,
                enable_thinking=eff_enable_thinking,
                service_call=bool(service_call),
            )
            if registry_response_usable(registry_response):
                logger.debug("ask_agent: ProviderRegistry model_path=%s", model_path)
                return registry_response
            return "Не удалось получить ответ от модели. Проверьте доступность провайдера."
        except httpx.HTTPStatusError as exc:
            logger.warning("ask_agent: ProviderRegistry HTTP %s", exc.response.status_code)
            return format_llm_http_error(exc)
        except Exception as exc:
            logger.debug("ask_agent: ProviderRegistry failed, fallback llm-svc: %s", exc)

    if USE_LLM_SVC:
        logger.info("ask_agent: llm-svc path model_path=%s images=%s", model_path, bool(images))
        
        # Если не указано количество токенов, берем из настроек
        if max_tokens is None:
            max_tokens = eff_max_tokens
        else:
            max_tokens = eff_max_tokens
        if temperature is None:
            temperature = eff_temperature
        
        try:
            # Используем llm_client для генерации
            response = ask_agent_llm_svc(
                prompt=prompt,
                history=history,
                max_tokens=max_tokens,
                streaming=streaming,
                stream_callback=stream_callback,
                model_path=model_path,
                custom_prompt_id=custom_prompt_id,
                images=images,
                system_prompt=system_prompt,
                temperature=temperature,
                enable_thinking=False if service_call else enable_thinking,
            )
            
            # Проверяем, не была ли генерация отменена
            if response is None:
                logger.warning("Генерация была отменена пользователем")
                return None  # Возвращаем None при отмене
            
            return response
            
        except asyncio.CancelledError:
            logger.warning("Генерация была отменена (asyncio.CancelledError)")
            return None  # Возвращаем None при отмене
        except Exception as e:
            logger.error(f"Ошибка генерации через llm-svc: {e}")
            return f"Извините, произошла ошибка при генерации ответа: {str(e)}"
    
    else:
        # Fallback к оригинальной логике (если llm-svc недоступен)
        logger.warning("llm-svc недоступен, используется fallback режим")
        return "llm-svc недоступен. Пожалуйста, запустите llm-svc сервис."

# Инициализация НЕ происходит автоматически при импорте модуля!
# Это позволяет избежать двойной загрузки модели.
# Инициализация будет выполнена явно из main.py при первом использовании.
logger.info("Модуль agent_llm_svc импортирован (инициализация отложена)")