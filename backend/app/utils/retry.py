"""
Meccanismo di retry per chiamate API
Utilizzato per gestire la logica di retry delle chiamate API esterne come LLM
"""

import time
import random
import functools
from typing import Callable, Any, Optional, Type, Tuple
from ..utils.logger import get_logger

logger = get_logger('mirofish.retry')


def retry_with_backoff(
    max_retries: int = 3,
    initial_delay: float = 1.0,
    max_delay: float = 30.0,
    backoff_factor: float = 2.0,
    jitter: bool = True,
    exceptions: Tuple[Type[Exception], ...] = (Exception,),
    on_retry: Optional[Callable[[Exception, int], None]] = None
):
    """
    Decoratore di retry con backoff esponenziale

    Args:
        max_retries: Numero massimo di tentativi
        initial_delay: Ritardo iniziale (secondi)
        max_delay: Ritardo massimo (secondi)
        backoff_factor: Fattore di backoff
        jitter: Se aggiungere jitter casuale
        exceptions: Tipi di eccezione per cui effettuare il retry
        on_retry: Funzione di callback al retry (exception, retry_count)

    Usage:
        @retry_with_backoff(max_retries=3)
        def call_llm_api():
            ...
    """
    def decorator(func: Callable) -> Callable:
        @functools.wraps(func)
        def wrapper(*args, **kwargs) -> Any:
            last_exception = None
            delay = initial_delay

            for attempt in range(max_retries + 1):
                try:
                    return func(*args, **kwargs)

                except exceptions as e:
                    last_exception = e

                    if attempt == max_retries:
                        logger.error(f"La funzione {func.__name__} ha fallito dopo {max_retries} tentativi: {str(e)}")
                        raise

                    # Calcola il ritardo
                    current_delay = min(delay, max_delay)
                    if jitter:
                        current_delay = current_delay * (0.5 + random.random())

                    logger.warning(
                        f"La funzione {func.__name__} tentativo {attempt + 1} fallito: {str(e)}, "
                        f"nuovo tentativo tra {current_delay:.1f}s..."
                    )

                    if on_retry:
                        on_retry(e, attempt + 1)

                    time.sleep(current_delay)
                    delay *= backoff_factor

            raise last_exception

        return wrapper
    return decorator


def retry_with_backoff_async(
    max_retries: int = 3,
    initial_delay: float = 1.0,
    max_delay: float = 30.0,
    backoff_factor: float = 2.0,
    jitter: bool = True,
    exceptions: Tuple[Type[Exception], ...] = (Exception,),
    on_retry: Optional[Callable[[Exception, int], None]] = None
):
    """
    Versione asincrona del decoratore di retry
    """
    import asyncio

    def decorator(func: Callable) -> Callable:
        @functools.wraps(func)
        async def wrapper(*args, **kwargs) -> Any:
            last_exception = None
            delay = initial_delay

            for attempt in range(max_retries + 1):
                try:
                    return await func(*args, **kwargs)

                except exceptions as e:
                    last_exception = e

                    if attempt == max_retries:
                        logger.error(f"La funzione asincrona {func.__name__} ha fallito dopo {max_retries} tentativi: {str(e)}")
                        raise

                    current_delay = min(delay, max_delay)
                    if jitter:
                        current_delay = current_delay * (0.5 + random.random())

                    logger.warning(
                        f"La funzione asincrona {func.__name__} tentativo {attempt + 1} fallito: {str(e)}, "
                        f"nuovo tentativo tra {current_delay:.1f}s..."
                    )

                    if on_retry:
                        on_retry(e, attempt + 1)

                    await asyncio.sleep(current_delay)
                    delay *= backoff_factor

            raise last_exception

        return wrapper
    return decorator


class RetryableAPIClient:
    """
    Wrapper client API con supporto retry
    """

    def __init__(
        self,
        max_retries: int = 3,
        initial_delay: float = 1.0,
        max_delay: float = 30.0,
        backoff_factor: float = 2.0
    ):
        self.max_retries = max_retries
        self.initial_delay = initial_delay
        self.max_delay = max_delay
        self.backoff_factor = backoff_factor

    def call_with_retry(
        self,
        func: Callable,
        *args,
        exceptions: Tuple[Type[Exception], ...] = (Exception,),
        **kwargs
    ) -> Any:
        """
        Esegui una chiamata a funzione con retry in caso di fallimento

        Args:
            func: Funzione da chiamare
            *args: Argomenti della funzione
            exceptions: Tipi di eccezione per cui effettuare il retry
            **kwargs: Argomenti keyword della funzione

        Returns:
            Valore di ritorno della funzione
        """
        last_exception = None
        delay = self.initial_delay

        for attempt in range(self.max_retries + 1):
            try:
                return func(*args, **kwargs)

            except exceptions as e:
                last_exception = e

                if attempt == self.max_retries:
                    logger.error(f"Chiamata API fallita dopo {self.max_retries} tentativi: {str(e)}")
                    raise

                current_delay = min(delay, self.max_delay)
                current_delay = current_delay * (0.5 + random.random())

                logger.warning(
                    f"Chiamata API tentativo {attempt + 1} fallito: {str(e)}, "
                    f"nuovo tentativo tra {current_delay:.1f}s..."
                )

                time.sleep(current_delay)
                delay *= self.backoff_factor

        raise last_exception

    def call_batch_with_retry(
        self,
        items: list,
        process_func: Callable,
        exceptions: Tuple[Type[Exception], ...] = (Exception,),
        continue_on_failure: bool = True
    ) -> Tuple[list, list]:
        """
        Chiamata batch con retry individuale per ogni elemento fallito

        Args:
            items: Lista degli elementi da elaborare
            process_func: Funzione di elaborazione, riceve un singolo item come parametro
            exceptions: Tipi di eccezione per cui effettuare il retry
            continue_on_failure: Se continuare a elaborare gli altri elementi dopo un fallimento

        Returns:
            (lista risultati riusciti, lista elementi falliti)
        """
        results = []
        failures = []

        for idx, item in enumerate(items):
            try:
                result = self.call_with_retry(
                    process_func,
                    item,
                    exceptions=exceptions
                )
                results.append(result)

            except Exception as e:
                logger.error(f"Elaborazione elemento {idx + 1} fallita: {str(e)}")
                failures.append({
                    "index": idx,
                    "item": item,
                    "error": str(e)
                })

                if not continue_on_failure:
                    raise

        return results, failures
