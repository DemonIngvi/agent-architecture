# R&D: Фреймворк агентского цикла

← [Все R&D](README.md) · [методология R&D v3.1](../rules/rnd-methodology.md) · компонент: **Harness** · решение: [design D2, D18](../../openspec/changes/define-agent-platform/design.md) · спека: [agent-harness](../../openspec/changes/define-agent-platform/specs/agent-harness/spec.md)

<div class="rnd-hero" markdown>
<div class="rnd-q">Вопрос</div>
На чём строить агентский цикл Harness: пауза на подтверждение, восстановление после сбоя, стрим шагов, любая модель через LiteLLM — внутри недоверенного sandbox?

<div class="rnd-a">Ответ: LangGraph за своим интерфейсом Harness. Запасной вариант — OpenAI Agents SDK; выбор подтверждается прототипом с проверкой AG1–AG5 в задаче 1.3.</div>

<span class="rnd-badge trial">Trial → Adopt после прототипа</span> LangGraph 1.2.14 (D18) · MIT · 0 $ · данные 11.10.2026
</div>

```deck
# Покрытие потребностей П1–П9
> LangGraph и OpenAI Agents SDK закрывают почти всё; у LangGraph checkpoint на каждом шаге
stack LangGraph: 8 ok, 1 part, 0 no
stack OpenAI Agents SDK: 7 ok, 2 part, 0 no
stack PydanticAI: 6 ok, 3 part, 0 no
stack Microsoft Agent Framework: 6 ok, 3 part, 0 no
stack Google ADK: 5 ok, 4 part, 0 no
stack Claude Agent SDK: 4 ok, 3 part, 2 no
stack Hermes Agent: 3 ok, 3 part, 3 no
stack Свой цикл: 3 ok, 6 part, 0 no
# Встраивание: сколько соседей меняется
> Hermes заменил бы части 4 компонентов; фреймворк-библиотека меняет 0
bar LangGraph: 0/4 соседей меняется ok
bar OpenAI Agents SDK: 0/4 соседей меняется ok
bar Google ADK: 1/4 сессии в БД → через Runner part
bar Hermes Agent: 4/4 Runner, Sandbox, Memory, Guardrails no
# Позиции ролей
side LangGraph | OpenAI Agents SDK
pos Разработчик: -1 | checkpoint и interrupt из коробки
pos Архитектор: -1 | граф = узлы G2 до и после llm и tools
pos DevOps: 0 | обе — библиотека в образе
pos Безопасность: 0 | секретов в sandbox нет в обоих
pos Тестировщик: 1 | у SDK проще цикл и тесты
# Что меняется
> D2 подтверждён; статус — Trial до прототипа; прототип добавлен в задачу 1.3
stack Документы: 5 ok, 0 part, 3 mute
- ✅ задача 1.3: прототип AG1–AG5, сравнение с OpenAI Agents SDK
- ✅ TECHNOLOGIES: LangGraph — Trial до прототипа · ✅ design D2: альтернативы
- ✅ бэклог: «умное» подтверждение из Hermes
```

**Почему LangGraph.** Три вывода:

<div class="rnd-grid" markdown>
<div markdown>
**1. Пауза и восстановление — без своего кода**

`interrupt` останавливает граф на подтверждении, checkpoint сохраняется после **каждого** шага. Значит, запуск продолжится с того же места и после «одобрить», и после падения контейнера (R-HRN-05). У OpenAI Agents SDK состояние сохраняется на прерывании (`RunState`), сохранение после каждого шага не подтверждено ([Э9](#e9)).
</div>
<div markdown>
**2. Граф ложится на наши проверки G2**

Проверки G2 (OPA, I10) встают узлами до и после `llm` и `tools` (R-HRN-04). Свой checkpointer отправляет состояние в Runner по I12 — без учётных данных БД в sandbox (D18). Соседние компоненты не меняются ([Э7](#e7)).
</div>
<div markdown>
**3. Hermes — готовый агент, а не цикл**

Hermes Agent силён: подтверждения, 7 видов терминалов, MCP, память. Но он сам делает то, что у нас делают Runner, Sandbox, Memory и Guardrails. Брать его — значит заменить 4 компонента. Мы берём у Hermes идею «умного» подтверждения — в бэклог ([Э6](#e6)).
</div>
</div>

<div class="rnd-grid" markdown>
<div class="take" markdown>
**Берём (у LangGraph)**

- граф `context → llm → tools`;
- `interrupt` для подтверждения;
- checkpoint после каждого шага;
- стрим событий графа;
- MCP через `langchain[mcp]`.
</div>
<div class="adapt" markdown>
**Адаптируем**

- checkpointer → свой, через API Runner (I12);
- события графа → наш `RunEvent` в NDJSON (I7);
- «одобрить один раз / на сессию» (Hermes) → решение подтверждения в `ApprovalDecision`;
- `needs_approval` на тул (OpenAI SDK) → список `approval.tools` из guardrails (уже есть).
</div>
<div class="drop" markdown>
**Не берём**

- LangGraph Platform: свой Runner;
- память, расписание и sandbox Hermes: это наши компоненты;
- durable execution на Temporal (PydanticAI): новый сервис, состояние у Runner;
- формат и CLI Claude Code в образе.
</div>
</div>

<div class="rnd-grid" markdown>
<div class="no" markdown>
**Отсеяны до сравнения**

- **LangGraph Platform**, облачные агенты (OpenAI Assistants, Vertex Agent Engine) — исполнение вне нашего sandbox.
</div>
<div class="risk" markdown>
**Риски и пересмотр**

- Частые изменения API LangChain — версия закреплена (1.2.14), LangGraph за своим интерфейсом.
- Пересмотр: прототип 1.3.9 покажет, что OpenAI Agents SDK проходит AG1–AG5 не хуже при меньшем коде.
</div>
</div>

<div class="rnd-chain" markdown>
<div markdown>**Э1 Вопрос**<span class="gate">G1</span></div>
<div markdown>**Э2 Потребности**9 <span class="gate">G2</span></div>
<div markdown>**Э3 LangGraph**8 функций <span class="gate">G3</span></div>
<div markdown>**Э4 Альтернативы**9 кандидатов <span class="gate">G4</span></div>
<div markdown>**Э5 Ценность**<span class="gate">G5</span></div>
<div markdown>**Э6 Перенос**4 MUST <span class="gate">G6</span></div>
<div markdown>**Э7 Встраивание**I7–I12 <span class="gate">G7</span></div>
<div markdown>**Э8 Спор**5 ролей <span class="gate">G8</span></div>
<div markdown>**Э9 Выбор**<span class="gate">G9</span></div>
<div markdown>**Э10 Последствия**8 <span class="gate">G10</span></div>
</div>

---

Дальше — как получен ответ, этап за этапом.

## Э1. Вопрос {#e1}

**Ситуация.** Harness — образ, который Runner запускает в sandbox на каждый запуск (D18). Внутри работает агентский цикл: модель, тулы, проверки G2, события для таймлайна.

**Осложнение.** Цикл можно написать самим или взять фреймворк. Фреймворков много, и каждый по-своему делает паузу, состояние и стрим. Есть и готовые агенты (Hermes), которые делают больше, чем цикл.

**Вопрос.** На чём строить агентский цикл Harness?

**Решает:** владелец продукта по предложению архитектора. **Не решаем:** изоляцию ([Sandbox](sandbox-isolation.md)), очередь ([Runner](runner-and-scheduling.md)), MCP или прямые вызовы ([MCP](mcp-vs-direct.md)).

<span class="gate">G1</span> ✅ вопрос — выбор; есть владелец; связан с D2, D18 и требованиями agent-harness.

## Э2. Потребности {#e2}

| # | Потребность | Откуда | Что ломается без неё |
|---|---|---|---|
| П1 | цикл «контекст → модель → тулы» с лимитами шагов и времени | R-HRN-02, R-HRN-09 | агент не завершается или зацикливается |
| П2 | пауза на подтверждение и продолжение с того же шага в **другом процессе** (контейнер мог смениться) | R-HRN-05, R-GRD-03 | подтверждение = перезапуск с нуля, лишние токены |
| П3 | восстановление после падения с последнего шага | R-HRN-05, I12, D18 | сбой контейнера теряет работу |
| П4 | любая модель через OpenAI-совместимый LiteLLM | R-HRN-03, I8 | привязка к одному провайдеру |
| П5 | стрим шагов для таймлайна | R-HRN-06, I7 | пользователь не видит ход работы |
| П6 | проверки до и после модели и тулов (G2) | R-HRN-04, I10 | нет точки для политик |
| П7 | тулы MCP | R-MCP-01, I9 | свои адаптеры к каждому серверу |
| П8 | указания пользователя во время работы | R-HRN-16 | нельзя поправить агента на ходу |
| П9 | работа в недоверенном sandbox: библиотека в образе, без учётных данных БД, без своих сервисов | D18, [техспека Harness](../techspec/harness.md) | секреты и состояние утекают в sandbox |

<span class="gate">G2</span> ✅ у каждой потребности есть требование или решение.

## Э3. Опорное решение: LangGraph {#e3}

Опорное решение — LangGraph, выбранный в D2 и закреплённый в D18 (1.2.14).

| # | Функция | Что делает | Потребность |
|---|---|---|---|
| F1 | Граф состояний (StateGraph) | узлы и переходы цикла | П1, П6 |
| F2 | `interrupt` | остановка графа и ожидание внешнего ответа | П2 |
| F3 | Checkpointer (интерфейс `BaseCheckpointSaver`) | состояние после каждого шага; свой checkpointer подключается | П2, П3, П9 |
| F4 | Стрим режимов (`updates`, `messages`, `custom`) | события шагов и токенов | П5 |
| F5 | Модели через LangChain (`ChatOpenAI` с `base_url`) | OpenAI-совместимый endpoint | П4 |
| F6 | MCP через `langchain[mcp]` | тулы MCP-серверов | П7 |
| F7 | Обновление состояния извне (`Command`, `update_state`) | вставка сообщения в состояние | П8 |
| F8 | Лимит рекурсии (`recursion_limit`) | остановка по числу шагов | П1 |

**Вывод этапа.** LangGraph закрывает все потребности функциями фреймворка. Свой код нужен только для checkpointer через Runner (F3) и для преобразования событий (F4).

<span class="gate">G3</span> ✅ функции связаны с потребностями; наличие — документация LangGraph (Б) и D2.

## Э4. Альтернативы и их ключевые функции {#e4}

Поиск 11.10.2026: GitHub, документация фреймворков, обзоры 2026 года (morphllm, fast.io, uvik). Звёзды и релизы — GitHub API на 11.10.2026.

| Кандидат | Ключевые функции по потребностям | Чего нет у LangGraph | Уровень |
|---|---|---|---|
| **OpenAI Agents SDK** (MIT, 29 961★, v0.23.1) | тул с `needs_approval` → прерывание; `RunState` сериализуется и продолжается позже; MCP-клиент; события стрима; модели через LiteLLM-расширение | подтверждение на уровне тула из коробки | Б |
| **PydanticAI** (MIT, 20 539★, v2.55.0) | тул с подтверждением → run завершается `DeferredToolRequests`, новый run продолжает с результатами; durable execution через Temporal, DBOS, Prefect, Restate | типизированные выходы | Б |
| **Google ADK** (Apache-2.0, 21 775★, v2.11.0) | подтверждение тула (экспериментально, с 1.14); возобновление после сбоя (с 1.16, `invocation_id`); сессии в БД | — | Б |
| **Microsoft Agent Framework** (MIT, 14 054★, python-1.21.0) | workflow с checkpoint после каждого шага; запрос к человеку через RequestPort; преемник AutoGen | типизированные запросы к человеку | Б |
| **Claude Agent SDK** (MIT, 8 248★, v0.2.165) | обёртка CLI Claude Code: hooks, разрешения тулов, сессии; формат Anthropic | готовые hooks и skills | Б |
| **Hermes Agent** (MIT, 252 653★, v0.21.6) | готовый автономный агент: подтверждения (`smart` / `manual` / `off`, отказ по таймауту 300 с, API `POST /v1/runs/{id}/approval`); 7 видов терминалов, в том числе Docker; MCP; память между сессиями; расписание | «умное» подтверждение: вспомогательная модель оценивает риск | Б |
| **Свой цикл** (проект AI-агент) | полный контроль, всё писать | — | — |
| LangGraph Platform, облачные агенты | исполнение у провайдера | — | Б |

**Вывод этапа.** Пауза с продолжением есть у всех фреймворков, но по-разному: прерывание графа (LangGraph, MAF), сериализуемое состояние прогона (OpenAI SDK), завершение и новый прогон (PydanticAI). Hermes — другой класс: агент целиком.

<span class="gate">G4</span> ✅ 9 кандидатов, включая «сделать самим»; источники трёх видов; дата есть.

## Э5. Ценность функций {#e5}

| Функция | Потребность | Почему ценна | Доказательство | Класс |
|---|---|---|---|---|
| Пауза с продолжением в другом процессе | П2 | подтверждение ждёт до 24 ч (`guardrails.approval_timeout`), контейнер не держим | есть у 6 фреймворков (Б) | базовая |
| Состояние после каждого шага | П3 | сбой не теряет сделанное, повтор не тратит токены | LangGraph checkpointer (Б); MAF checkpoint (Б); ADK resumability (Б) | базовая |
| OpenAI-совместимый endpoint | П4 | все модели через LiteLLM, бюджеты и ключи там | у 6 из 8 (Б) | базовая |
| Работа как библиотека в образе без своих сервисов | П9 | sandbox недоверенный, состояние у Runner | D18 (А) | базовая |
| Хуки до и после модели и тулов | П6 | место для G2 | узлы графа LangGraph (Б), RunHooks OpenAI SDK (Б), hooks Claude SDK (Б) | линейная |
| Стрим событий | П5 | таймлайн в ICPlan | у всех фреймворков (Б) | линейная |
| Подтверждение на уровне тула | П2 | проще описать, какие тулы ждут человека | OpenAI SDK, PydanticAI, ADK (Б) | линейная: у нас уже есть `approval.tools` |
| «Умное» подтверждение: модель оценивает риск, спорное — человеку | П2 | меньше ручных подтверждений безопасных действий | Hermes (Б); одна реализация, опыт не подтверждён | привлекательная |
| Отказ по таймауту подтверждения | П2 | неотвеченное подтверждение не висит вечно | Hermes (Б); у нас — `guardrails.approval_timeout` (А) | базовая, уже есть |
| Durable execution на внешнем движке | П3 | — | Temporal / DBOS — новый сервис; состояние у Runner (D18) | обратная |
| Память, расписание, свой sandbox в агенте | — | — | дублирует Memory, Runner, Sandbox | обратная |

**Вывод этапа.** Базовые функции: пауза с продолжением в другом процессе, состояние после каждого шага, OpenAI-совместимый endpoint и работа как библиотека. Хуки и стрим — линейные. «Умное» подтверждение — привлекательная функция на будущее.

<span class="gate">G5</span> ✅ у каждой функции есть доказательство уровня Б и выше.

## Э6. Перенос и критерии {#e6}

| Функция | Решение | Как | Где |
|---|---|---|---|
| Граф, `interrupt`, стрим, MCP | брать | как в LangGraph | задачи 1.3–1.5 |
| Checkpointer | адаптировать | свой saver: `PUT / GET /runs/{id}/checkpoint` в Runner | I12, R-HRN-11 |
| События графа | адаптировать | преобразование в `RunEvent` NDJSON | I7, R-HRN-06 |
| Подтверждение на тул | оставить | уже есть: `approval.tools` из guardrails | R-HRN-05 |
| «Одобрить один раз / на сессию» (Hermes) | адаптировать | поле в `ApprovalDecision`: только этот вызов или до конца запуска | R-GRD-03, поле `scope` в `ApprovalDecision` |
| «Умное» подтверждение (Hermes) | не брать сейчас | нужна оценка ложных пропусков; в бэклог | [BACKLOG](../BACKLOG.md) |
| Durable execution на Temporal | не брать | новый сервис, состояние у Runner | — |
| Память, расписание, sandbox Hermes | не брать | это наши компоненты | — |

**Критерии:**

| Критерий | Цепочка | Как проверяем |
|---|---|---|
| **M1** открытая лицензия, исполнение у нас | П9 → библиотека → базовая | лицензия, нет обязательного облака |
| **M2** пауза с продолжением в другом процессе | П2 → базовая | документация: сериализуемое состояние |
| **M3** OpenAI-совместимый endpoint | П4 → базовая | клиент с `base_url` |
| **M4** состояние наружу без доступа к БД | П3, П9 → базовая | свой checkpointer или сериализация |
| **К1** состояние после каждого шага | П3 | checkpoint на шаге или только на паузе |
| **К2** точки для G2 | П6 | хуки до и после модели и тулов |
| **К3** стрим и указания | П5, П8 | события, вставка сообщения |
| **К4** сколько своего кода | П1–П8 | что дописывать |
| **К5** зрелость и стабильность API | — | звёзды, релизы, ломающие изменения |

<span class="gate">G6</span> ✅ у функций есть решения; у критериев — цепочка.

## Э7. Отсев и встраивание {#e7}

### Отсев по MUST

| Кандидат | M1 у нас | M2 пауза | M3 LiteLLM | M4 состояние наружу | Итог |
|---|---|---|---|---|---|
| LangGraph | да | да, `interrupt` | да | да, свой checkpointer | проходит |
| OpenAI Agents SDK | да | да, `RunState` | да, LiteLLM-расширение | да, `RunState` строкой | проходит |
| PydanticAI | да | да, deferred tools | да | да, история сообщений | проходит |
| Microsoft Agent Framework | да | да, RequestPort | да, OpenAI-клиент | да, своё хранилище checkpoint | проходит |
| Google ADK | да | да, экспериментально | да, LiteLLM-обёртка | частично: сессии в БД, нужен свой сервис сессий | проходит |
| Claude Agent SDK | да | частично: разрешения тулов, сессии в файлах | частично: формат Anthropic; endpoint LiteLLM `/v1/messages` не проверен | частично | проходит с оговоркой |
| Hermes Agent | да | да, API подтверждения | частично: «любой endpoint», настройка не проверена | не подтверждено | проходит с оговоркой |
| Свой цикл | да | писать | да | писать | проходит |
| LangGraph Platform, облачные агенты | **нет**: исполнение у провайдера | — | — | — | ✗ |

### Как встаёт в схему

```
                 ┌────────────────────── sandbox (образ Harness на запуск) ───────────────────────┐
 Agent Runner ◀──┼─I7 RunBundle / RunEvent NDJSON──▶ Harness: граф LangGraph                       │
      ▲          │                                      │ узлы G2 ──I10──▶ OPA                     │
      └──I12 checkpoint* (PUT/GET /runs/{id}/checkpoint)┤ llm ──I8──▶ LiteLLM (через egress-прокси) │
                 │                                      │ tools ──I9──▶ MCP-серверы                 │
                 │                                      └ память ──I11──▶ Memory API                │
                 └──────────────────────────────────────────────────────────────────────────────────┘
  * — свой checkpointer: состояние у Runner, учётных данных БД в sandbox нет (D18)
```

| Стык | LangGraph | OpenAI Agents SDK | PydanticAI | MAF | Google ADK | Claude Agent SDK | Hermes Agent |
|---|---|---|---|---|---|---|---|
| I7 события → Runner | И2: стрим → `RunEvent` | И2 | И2 | И2 | И2 | И1: поток сообщений CLI | И1: API `/v1/runs` |
| I8 модель через LiteLLM | И2: `ChatOpenAI(base_url)` | И2 | И2 | И2 | И2 | И1 | И1 |
| I9 MCP | И2: `langchain[mcp]` | И2 | И1 | И1 | И1 | И2 | И2 |
| I10 G2 → OPA | И2: узел графа | И2: hooks | И1 | И1 | И1: callbacks | И2: hooks | И0: свои подтверждения |
| I11 Memory API | И2: тул или узел | И2 | И2 | И2 | И1: своя память | И2 | И0: своя память |
| I12 checkpoint → Runner | И2: свой saver | И2: `RunState` строкой | И2: история сообщений | И1: своё хранилище checkpoint | И1: свой сервис сессий | И0: сессии в файлах | И0 |

**Изменения у соседей:**

| Кандидат | Что меняется у соседей |
|---|---|
| LangGraph, OpenAI SDK, PydanticAI, MAF | ничего: библиотека внутри образа Harness |
| Google ADK | Runner: хранение сессий ADK вместо checkpoint (I12 меняет формат) |
| Claude Agent SDK | техспека Harness: в образе Node и CLI Claude Code; LiteLLM: Anthropic-endpoint |
| Hermes Agent | Runner (своё расписание и диспетчер), Sandbox (свои терминалы), Memory (своя память), Guardrails (свои подтверждения) — четыре компонента переписываются |

**Вывод этапа.** ==Библиотеки встают в Harness без изменений у соседей; Hermes заменил бы четыре компонента платформы.== У LangGraph все стыки на уровне И2: протокол совпадает с нашими I-кодами, свой код — checkpointer и преобразование событий.

<span class="gate">G7</span> ✅ отсев до сравнения; готовность по I7–I12 у каждого прошедшего; изменения у соседей названы.

## Э8. Спор ролей {#e8}

Роли 🤖 отыграны агентом. Оппонент защищает OpenAI Agents SDK, «адвокат дьявола» атакует LangGraph.

| Роль | За | Довод | Опасение | Согласится, если |
|---|---|---|---|---|
| Разработчик 🤖 | LangGraph | `interrupt` и checkpoint на каждом шаге — меньше своего кода (Э3) | ломающие изменения LangChain | версия закреплена, LangGraph за своим интерфейсом |
| Архитектор 🤖 | LangGraph | узлы G2 и checkpointer через Runner ложатся на I10, I12 | — | — |
| DevOps 🤖 | нейтрально | обе библиотеки — Python-пакет в образе | размер образа | образ по техспеке, зависимости закреплены |
| Безопасность 🤖 | нейтрально | секретов в sandbox нет при любом выборе (egress-прокси) | Hermes и Claude SDK тянут свои механизмы прав | Hermes и Claude SDK не выбраны |
| Тестировщик 🤖 (оппонент) | OpenAI Agents SDK | цикл проще, тесты короче; подтверждение тула из коробки | у LangGraph сложнее отладка графа | сравнение на одинаковых эталонных задачах |

| Спор | Разрешение |
|---|---|
| Оппонент: «SDK проще и тоже продолжает после паузы» | ✅ **внесено:** подзадача 1.3.9 — прототип на 5–10 эталонных задачах, AG1–AG5 для LangGraph и OpenAI Agents SDK; при равенстве и меньшем коде — пересмотр D2 |
| Адвокат дьявола: «LangChain ломает API каждые полгода» | **условие:** версия 1.2.14 закреплена (D18), LangGraph за интерфейсом Harness |
| Адвокат дьявола: «Hermes в 6 раз популярнее — может, он и есть платформа?» | **отклонено фактами Э7:** Hermes заменяет четыре компонента; функции берём по одной (Э6) |
| Безопасность: «“умное” подтверждение пропустит опасное» | **условие:** не брать сейчас; в бэклоге — с оценкой ложных пропусков |

**Вывод этапа.** Главный спор — LangGraph против OpenAI Agents SDK. Фактами он не решается, поэтому разрешён прототипом в задаче 1.3. До прототипа статус — Trial.

<span class="gate">G8</span> ✅ у каждого спора есть разрешение.

## Э9. Выбор {#e9}

| Потребность | LangGraph | OpenAI SDK | PydanticAI | MAF | Google ADK | Claude SDK | Hermes | Свой цикл |
|---|---|---|---|---|---|---|---|---|
| П1 цикл с лимитами | закрывает | закрывает | закрывает | закрывает | закрывает | закрывает | закрывает | с доработкой |
| П2 пауза в другом процессе | закрывает | закрывает | закрывает | закрывает | частично: экспериментально | частично | частично: в своём API | с доработкой |
| П3 состояние после шага | закрывает | частично: на паузе | частично: без движка — на границе прогона | закрывает | закрывает | не закрывает | не закрывает | с доработкой |
| П4 LiteLLM | закрывает | закрывает | закрывает | закрывает | закрывает | частично | частично | закрывает |
| П5 стрим | закрывает | закрывает | закрывает | закрывает | закрывает | закрывает | частично | с доработкой |
| П6 точки G2 | закрывает | закрывает | частично | частично | частично | закрывает | не закрывает | с доработкой |
| П7 MCP | закрывает | закрывает | закрывает | частично | частично | закрывает | закрывает | с доработкой |
| П8 указания | частично: вставка в состояние | частично | частично | закрывает | частично | частично | закрывает | с доработкой |
| П9 библиотека в sandbox | закрывает | закрывает | закрывает | закрывает | частично: сессии | не закрывает: Node + CLI | не закрывает: свои сервисы | закрывает |

- **Утверждение.** Оставляем LangGraph (D2) за своим интерфейсом Harness; статус Trial до прототипа.
- **Основания.**
  - LangGraph закрывает 8 из 9 потребностей.
  - Состояние сохраняется после каждого шага — это П3, которой у OpenAI SDK на уровне шага не подтверждено.
  - Все стыки на И2, соседи не меняются (Э7).
- **Связка.** Восстановление после сбоя и пауза в другом процессе — базовые для запусков, которые ждут человека до 24 ч. Остальные кандидаты либо требуют внешнего движка, либо заменяют компоненты платформы.
- **Опровержение.** Вывод неверен, если прототип 1.3.9 покажет, что OpenAI Agents SDK проходит AG1–AG5 не хуже при заметно меньшем коде. Тогда D2 пересматривается.

| Риск лидера | Что делаем |
|---|---|
| Ломающие изменения API LangChain | версия закреплена, свой интерфейс Harness |
| Сложность отладки графа | события каждого узла в таймлайне (R-HRN-06) |

<span class="gate">G9</span> ✅ вывод следует из покрытия, встраивания и спора; есть опровержение.

## Э10. Последствия {#e10}

| Изменение | Документ | Статус |
|---|---|---|
| Прототип с evals AG1–AG5: LangGraph и OpenAI Agents SDK на 5–10 эталонных задачах | [задача 1.3](../tasks/1.3-harness-core.md) (подзадача 1.3.9) | ✅ внесено |
| Статус LangGraph: Trial до прототипа | [TECHNOLOGIES](../TECHNOLOGIES.md) | ✅ внесено |
| Альтернативы в решении D2: OpenAI SDK, PydanticAI, ADK, MAF, Hermes | [design D2](../../openspec/changes/define-agent-platform/design.md) | ✅ внесено |
| «Умное» подтверждение (Hermes) | [BACKLOG](../BACKLOG.md) | ✅ внесено в бэклог |
| «Одобрить только этот вызов / до конца запуска» в `ApprovalDecision` | [R-GRD-03](../../openspec/changes/define-agent-platform/specs/guardrails/spec.md#r-grd-03), I7 | ✅ внесено: сценарий в R-GRD-03, поле `scope`, подзадача 1.5.6 |
| Решение D2 и версия 1.2.14 | design D2, D18 | ✅ подтверждено, без изменений |
| Стыки I7–I12 | спека agent-harness, [поток Harness](../flows/harness.md) | — не требуется: протоколы не меняются |
| Техспека Harness | [техспека](../techspec/harness.md) | — не требуется |

<span class="gate">G10</span> ✅ у каждого изменения есть документ и статус.

<details markdown>
<summary>Приложение A. Карточки кандидатов</summary>

GitHub API на 11.10.2026.

| Технология | Лицензия | ★ | Релиз | Активность |
|---|---|---|---|---|
| LangGraph | MIT | 43 047 | cli 0.4.33 (библиотека 1.2.14) | 11.10.2026 |
| OpenAI Agents SDK | MIT | 29 961 | v0.23.1 | 08.10.2026 |
| Google ADK | Apache-2.0 | 21 775 | v2.11.0 | 11.10.2026 |
| PydanticAI | MIT | 20 539 | v2.55.0 | 11.10.2026 |
| Microsoft Agent Framework | MIT | 14 054 | python-1.21.0 | 11.10.2026 |
| Claude Agent SDK | MIT | 8 248 | v0.2.165 | 09.10.2026 |
| Hermes Agent | MIT | 252 653 | v0.21.6 | 11.10.2026 |
</details>

## Источники

Поиск и чтение — 11.10.2026; в скобках уровень доказательства.

- LangGraph: [репозиторий](https://github.com/langchain-ai/langgraph) (Б), решение [D2, D18](../../openspec/changes/define-agent-platform/design.md) (А)
- OpenAI Agents SDK: [RunState](https://openai.github.io/openai-agents-python/ref/run_state/) (Б), [релиз 0.8.0: needs_approval](https://newreleases.io/project/pypi/openai-agents/release/0.8.0) (В)
- PydanticAI: [deferred tools](https://pydantic.dev/docs/ai/tools-toolsets/deferred-tools/) (Б), [durable execution](https://pydantic.dev/docs/ai/integrations/durable_execution/overview/index.md) (Б), [Temporal](https://temporal.io/blog/build-durable-ai-agents-pydantic-ai-and-temporal) (В)
- Google ADK: [подтверждение тулов](https://adk.dev/tools-custom/confirmation/) (Б), [возобновление](https://adk.dev/runtime/resume/) (Б)
- Microsoft Agent Framework: [human-in-the-loop](https://learn.microsoft.com/agent-framework/workflows/human-in-the-loop) (Б), [checkpoint](https://learn.microsoft.com/en-us/agent-framework/tutorials/workflows/checkpointing-and-resuming) (Б)
- Claude Agent SDK: [репозиторий](https://github.com/anthropics/claude-agent-sdk-python) (Б)
- Hermes Agent: [документация](https://hermes-agent.nousresearch.com/docs/) (Б), [безопасность и подтверждения](https://hermes-agent.nousresearch.com/docs/user-guide/security) (Б), [репозиторий](https://github.com/NousResearch/hermes-agent) (Б)
- Обзоры: [morphllm — 8 SDK 2026](https://www.morphllm.com/ai-agent-framework) (В), [fast.io](https://fast.io/resources/best-ai-agent-frameworks-for-python/) (В), [uvik](https://uvik.net/python-ai-agent-frameworks/) (В)
