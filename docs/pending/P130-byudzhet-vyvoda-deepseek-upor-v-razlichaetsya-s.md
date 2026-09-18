# ⏳ Бюджет вывода DeepSeek — упор в `max_tokens` различается с 10.09 (recommend brain 2026-09-10, G334)

> Запись `P130` реестра [PENDING_FOLLOWUPS](../PENDING_FOLLOWUPS.md). Индекс грепается, запись читается целиком, реестр целиком не читается никогда ([D-097](../../AGENTS.md)).

`⏱ 2026-09-10 · snooze 0 · watch · выкачено 10.09 (прод 614de94 и новее); замер ~17.09: пересчитать finish=length по меткам`

Причина `truncated` теперь отдельная — в общем клиенте и в конвейере. Строка `deepseek-usage`
несёт `reasoning=` и `finish=`, где прочерк значит «поля нет», а не ноль. Живая проба на
проде 10.09: модель (`deepseek-flash`) не рассуждает, `reasoning_tokens` в `usage` нет вовсе,
а обрезание у нас — **оборванный JSON, не пустой ответ**, поэтому раньше оно тонуло в
`llm_unparseable`. Для конвейера, discovery и дистилляции ноль обрезаний доказан
(`completion` всегда ниже потолка); для headless — только верхняя граница, потому что
потолок зависит от размера чанка, которого нет в логе.

**Хвост:** через неделю после релиза посчитать `finish=length` по меткам в логах воркера
(`zgrep -h 'deepseek-usage' celery-worker.log* | grep 'finish=length'`). Для headless это
впервые будет счёт. Есть обрезания — поднять `_MAX_TOKENS_PER_POST` (220) или делить
обрезанный чанк пополам. Мозгу число обещано письмом
[`2026-09-10-output-budget-…`](../../mailbox/to-brain/2026-09-10-output-budget-our-model-does-not-reason-truncation-is-cut-json-not-empty.md).
