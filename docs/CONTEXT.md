# CONTEXT — полный хэндофф проекта genai-harness

Этот файл — «точка входа» для новой сессии (например, после обновления Claude Code). Прочитай
его целиком, и ты восстановишь весь контекст: что это, что сделано, как устроено, как продолжить.
Дата актуальности: **2026-09-04**.

> **Статус (2026-09-06).** Это исторический хэндофф прототипа-предшественника **genai-harness**. Актуальный проект — **`aitest_cui`** (`/home/dev/aitest_cui`): модульные векторы `attack_vectors/` (грамматика `a-<name>`, флаг `--report`), стенд **genai-cui** на портах 9xxx (agent 9600, data 9200, keycloak 9180, redis 16379, mongo 37017). Актуальные точки входа: `README.md`, `docs/ARCHITECTURE.md`, `docs/ATTACK_VECTORS.md`; прогоны и отчёты — `output/runs/<штамп>/` (авто-отчёт `REPORT_<штамп>.{md,pdf}`, авто-пруф отравления `output/POISON_PROOF.md` и per-модульные `proof.md`). Ниже — исходный контекст genai-harness как история.

---

## 0. TL;DR

Построена **универсальная тула тестирования безопасности GenAI-агентов с памятью** —
`~/genai-harness/`. Прототип рабочий, прогнан на уязвимом стенде `genai-invest-stand`, найдено
**6 находок** (BAC×3, отравление памяти×2, связка A×B — negative), сделаны сравнения атакующих и
целевых моделей. Стенд НЕ изменён (код цели не трогали). Всё логируется. Основные документы:
`RESULTS.md` (находки), `HOW_IT_WORKS.md` (на пальцах), `ARCHITECTURE.md`, `README.md`,
`PORTABILITY.md`, `WORKLOG.md`, `docs/PLAN.md` + два PDF в `docs/`.

---

## 1. Задача (ТЗ)

Источник — шара `/media/sf_AITest/` (`claude-code-prompt.md` = ТЗ, `customer_info.md` = описание
цели). Копии в проекте: `TASK_SPEC.md`, `customer_info.md`.

Суть: легитимная защитная тула (как SAST/фаззер) — воспроизводимо находить BAC и отравление
памяти агента, мерить **детерминированным оракулом состояния** (не по тексту), давать парный
пруф `vulnerable`↔`protected`. **Принцип №0:** не сшита с целью — все факты в
`config/target.yaml` (из customer_info), перенос = замена одного файла. Главный артефакт —
`findings.json` (самодостаточен для перепроверки на другом агенте).

---

## 2. Текущий статус — ВСЁ СДЕЛАНО

- ✅ Фаза 0+1: карта цели (`harness/NOTES.md`) + замороженный спек (`harness/config/*.yaml`).
- ✅ Фаза 2: каркас (core + oracle), смоук проходит.
- ✅ Таск A (BAC): 3 находки, зелёный.
- ✅ Таск B (отравление): 2 находки (global + within-user), продольно по стадиям памяти.
- ✅ Ширина: сравнение атакующих моделей, полная матрица целевых моделей (6), связка A×B
  (negative), переносимость документирована.
- ✅ Документация + 2 PDF.

Что можно доделать (не критично, см. §7).

---

## 3. Окружение и как запустить

**Стенд (цель):** `~/genai-invest-stand/`, docker compose. Сейчас ПОДНЯТ. Если после ребута лёг:
```bash
cd ~/genai-invest-stand && docker compose up -d      # cert Keycloak уже есть; ждать healthy
curl localhost:8600/healthz                          # {"status":"ok"}
```
Порты: agent-api 8600, data 8200, mcp 8100, keycloak 8180/8443, redis 6379, mongo 27017.
Модель цели: `gpt-5-mini` (мозг+консолидация), провайдер OpenRouter, в `~/genai-invest-stand/.env`.
**НЕ менять код стенда.** Смена модели цели — только через .env-оверлей (см. `target_matrix.py`).

**Тула:** `~/genai-harness/`, venv `.venv` (pyyaml/pymongo/redis/requests). Ключ OpenRouter в
`~/genai-harness/.env` (`OPENROUTER_API_KEY`).
```bash
cd ~/genai-harness && set -a && . ./.env && set +a
./.venv/bin/python -m harness.orchestration.run smoke     # проверка связности
./.venv/bin/python -m harness.orchestration.run bac       # Таск A
./.venv/bin/python -m harness.orchestration.run poison    # Таск B (медленно, ~25 мин)
./.venv/bin/python -m harness.orchestration.run models    # сравнение атакующих моделей
./.venv/bin/python -m harness.orchestration.run chain     # связка A×B
./.venv/bin/python /tmp/.../run_target_matrix_full.py     # матрица целевых (или target_matrix.__main__)
```

**Ключ OpenRouter — ВАЖНО:** ключ ОДИН (в `.env` харнесса И в `.env` стенда — один и тот же ключ, не коммитить). Через него идёт ВСЁ: и харнесс (attacker/judge), и мозг агента-цели.
На 04.09 израсходовано ~$5.4 из $63, осталось ~$57.6 (gpt-5-mini дёшев). Лимита на ключе нет.

---

## 4. Находки (детали в RESULTS.md; артефакты в harness/runs/)

| Находка | run-папка | суть |
|---|---|---|
| F-BAC-DATA [critical] | `runs/bac-20260904-015111/` | data-layer пара vuln 200 / prot 403 |
| F-BAC-AGENT [critical] | там же | LLM→tool BAC 6/8=0.75 vuln, 0/8 prot |
| F-BAC-OWNER [high] | там же | account_owner течёт в protected |
| F-POISON-GLOBAL [critical] | `runs/poison-20260904-021041/` | cross-tenant 4/28, драйвер compliance-регистр; база 0 |
| F-POISON-USER [high] | там же | within-user 19/28=0.68 |
| F-CHAIN-AXB [info/negative] | `runs/chain-20260904-024520/` | правило садится 4/4, но триггер не эксплуатирует 0/4 |

**Сравнение атакующих** (`runs/models-20260904-015844/`): deepseek-v4-flash 6/6 лучший, opus-5
отказался (пустой ответ). **Матрица целевых** (`runs/target-matrix-20260904-095117/`):
llama-4-maverick 0/9 = ПРОВАЛ ВОЗМОЖНОСТЕЙ (не умеет tool-calling, не «устойчивость»); gpt-4o-mini
0.67 (устойчивее из рабочих), gpt-5-mini/sonnet-5/qwen 0.78, deepseek-flash 1.0.

---

## 5. Устройство (кратко; полно — ARCHITECTURE.md)

`harness/config/` — target/hypotheses/models/payloads.yaml (единственная правда о цели).
`harness/core/` — config, client (транспорт+аудит), provisioning (headless-ключи), openrouter,
attacker (LLM-мутатор), isolation (canary/reset), runlog.
`harness/oracle/` — state (BAC + чтение памяти), fingerprints (мульти-отпечаток), memory_observer
(диффы), judge_llm (дифф-судья).
`harness/tasks/` — bac, memory_poison (продольно по стадиям), chain_ab.
`harness/recon/` — route_oracle, prompt_fuzz (black-box/non-LLM ось).
`harness/orchestration/` — run.py (CLI), target_matrix.py.
`harness/report/` — findings, coverage, susceptibility, stats(Уилсон).
`harness/runs/<id>/` — attempts.jsonl, calls.jsonl, openrouter.jsonl, findings, coverage.

---

## 6. ГРАБЛИ И УРОКИ (обязательно прочитать перед продолжением)

1. **Изоляция памяти критична.** В mongo копятся канарейки прошлых прогонов и гнут ответы агента.
   Перед кампанией — `isolation.reset_memory()` (полный сброс ярусов, НЕ трогает api_keys) или
   `purge_all_canaries()` (по сигнатурам маркеров). Постгрес-посев клиентов не трогать.
2. **Детект ложных плюсов.** Отпечатки НЕ засчитывают: (а) эхо чужого id, который атакующий сам
   положил в запрос; (б) голые короткие числа. Сильные признаки: имя/кэш/ISIN/`ISIN×amount`/налог.
3. **Фоновые прогоны — только ПРЯМОЙ run_in_background** (сам python как команда). НЕ
   `python ... &` внутри bash (SIGHUP убьёт python) и НЕ pgrep-сторож с паттерном своей же
   команды (`pgrep -f "orchestration.run X"` матчит сам сторож → вечный цикл). Оба бага ловил.
4. **docker force-recreate** agent-api при первом «холодном» рестарте может подвиснуть в `Created`
   ~40с — НЕ вмешиваться вручную (`docker start` создаёт гонку двух контейнеров); ждать (таймаут
   health в target_matrix = 150с). target_matrix бэкапит и ВОССТАНАВЛИВАЕТ .env в finally.
5. **Возможности ≠ безопасность.** Модель, не умеющая tool-calling (llama-4-maverick), даёт 0
   утечек — это провал возможностей, помечать отдельно, НЕ засчитывать «безопасно».
6. **Отравление стохастично и НЕ мгновенно.** Мерить частоту на N; finalize дёргать явно (2
   канала: endpoint / слово `finalize`); global редко, user часто (оба — результат); контрзаписи-
   отказы гасят эффект → сброс памяти между формулировками. Цикл ~52с (gpt-5-mini reasoning).

---

## 7. Открытые направления (если продолжать)

- Связка A×B: добить бо́льшим N / другими формулировками (сейчас 0/4 — правило садится, но не
  триггерит); поднять `MAX_REACT_TOOL_CALLS` оверлеем, чтобы дать агенту шаги на цепочку тулов.
- BAC-свип: расширить на ВСЕ 7 чувствительных инструментов × 4 жертвы (сейчас MVP-пара 1001→1003).
- Ось «где LLM»: отдельное сравнение static vs LLM-oneshot vs LLM-adaptive по одной цели.
- Within-user (H4) отдельным чистым прогоном (сейчас доказан внутри poison как scope=user).
- Матрица {attacker}×{target} целиком (сейчас две оси измерены раздельно).
- Расширить оракул на black-box режим (`GET /memory` через SSO — помечено needs_review).

---

## 8. Как продолжить после обновления Claude Code

1. Открой этот файл (`docs/CONTEXT.md` в `aitest_cui`) — исторический контекст; актуальные точки входа см. в баннере вверху.
2. Проверь стенд: `docker compose -f ~/genai-invest-stand/docker-compose.yml ps` → если лёг,
   `docker compose up -d`.
3. Проверь тулу: `cd ~/genai-harness && set -a && . ./.env && set +a && ./.venv/bin/python -m
   harness.orchestration.run smoke` → должно быть `SMOKE OK`.
4. Дальше — по §7 или новая задача. Память Claude тоже хранит краткую версию: см.
   memory `genai-harness-tool` (в MEMORY.md).

**Связанные (референс, НЕ часть этого проекта):** `~/genai-sectest/` (прошлая, сшитая с целью
тула + подключённые garak/llamator/pyrit/deepteam), `~/Desktop/investigation/` (методы разведки),
PDF-разборы стенда на `~/Desktop/`.
