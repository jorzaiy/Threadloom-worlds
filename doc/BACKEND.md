# Threadloom Backend

**当前版本：v1.0**

第一版后端仍采用 Python 标准库实现，目标是先跑通最小链路，不先引入额外框架依赖。

## 当前文件

- `server.py`：HTTP 服务入口；`do_GET/do_POST/do_DELETE` 通过 `_GET_ROUTES/_POST_ROUTES/_DELETE_ROUTES` 的 path→handler 分发表路由到 `_get_* / _post_* / _delete_*` handler；请求壳由 `_request_scope(method)` context manager 统一管理（解析用户/多用户上下文，`finally` 必定重置 token），session 路由前导统一走 `_resolve_scoped_session`
- `handler_message.py`：`POST /api/message` 主链入口；fact-log：`THREADLOOM_FACTLOG_WRITE_IMPORTANT=1` 时在权威 `save_state` **之前** commit + 合并写回 `important_npcs`（跳过 tracker/continuity），默认关则 `save_state` 后 `_shadow_commit_fact_log` 仅诊断；narrator 前 `_load_factlog_view`（`THREADLOOM_FACTLOG_NARRATOR`）+ `_factlog_recall`（长尾召回双轨：`THREADLOOM_RETRIEVE_SHADOW` 默认开只写 `retrieve_shadow.jsonl`、`THREADLOOM_RETRIEVE_V2` 默认关才注入）
- `runtime_store.py`：session 目录、文件读写（原子写入）与状态快照；JSON 读取统一走 `_load_json(path, default, *, backup_corrupt=...)`，区分“文件缺失”（返回 default 深拷贝）与“解析损坏”（`logger.exception` + 把坏文件移到 `<name>.corrupt` 后返回 default），机器生成的 session 数据默认备份、用户手编文件只记录不挪动；`_history_cache` 与 history/event-summary/meta/分片的 read-modify-write 由模块级 `_STORE_LOCK`（RLock）串行化
- `paths.py`：三层路径管理（user / character / session 分层路径解析），提供 `active_user_id` / `active_character_id` context var 与 request-local override 机制
- `atomic_io.py`：原子文件读写原语（写临时文件 → fsync → `os.replace`），供 `runtime_store.py` / `keeper_archive.py` 等写入层统一使用
- `bootstrap_session.py`：新 session bootstrap
- `context_builder.py`：runtime 上下文装配；当前 narrator 输入是“强约束层 + 连续性层 + 候选知识层”的分层装配，并把 recent window 配置拆成完整正文窗口与前段提纲桥接；selector 命中的 NPC profile 若缺少 source markdown，会 fallback 到当前 session persona seed；summary chunk 只在当前 turn 有足够直接锚点时回流；narrator 为 grok 系列时把 runtime_rules 切到 `runtime-rules-grok.md`（`_runtime_rules_path_for_narrator`，按 narrator 模型名判断）；同时加载 `sources.narrator_identity_reset`（世界模拟引擎身份重置块，注入到 narrator system prompt 最首块），未配置时降级为空字符串
- `selector.py`：NPC 候选召回决策层；根据 onstage / relevant_npcs、active_threads、recent_history 与 important_npcs 信号判断是否注入 NPC profile 候选，并按话题相关度排序
- `narrator_input.py`：narrator prompt 拼装；最首块注入【世界模拟引擎】（身份重置 + 世界模拟框架 + 玩家剥离，来自 `context.narrator_identity_reset`，仅非空时注入），优先于 runtime_rules；含 `_format_knowledge_scope()` 渲染结构化知情边界、`_format_actor_registry()` 渲染不可变角色注册表，以及事件时间轴、recent window 前段 event outline + 近端完整正文；`_format_factlog_cast()` 渲染 fact-log 投影的【人物档案·权威】块（归并名+锁定 persona+知情边界白名单，插在旧块前、冲突以它为准；开关 `THREADLOOM_FACTLOG_NARRATOR` 默认开、空则回退）；`_format_factlog_recall()` 渲染 `retrieve()` 召回的【往事回溯·检索】块（每行带来源轮次，声明"可引用不可改写、被召回≠NPC 知道"；开关 `THREADLOOM_RETRIEVE_V2` 默认关、无命中不出块）
- `model_config.py` / `model_client.py`：模型配置与模型调用（含 429/503 自动重试）
- `llm_manager.py`：统一 LLM 角色调用管理层；封装 `call_role_llm()`，按角色 key 查找模型配置并调用 `model_client`，供各 agent 统一使用
- `safe_http.py`：SSRF 安全 HTTP 连接辅助；DNS 预解析 + IP pin，按 `_LOOPBACK_HOSTS` 白名单放行 loopback，拒绝私网/link-local 直连，防止 DNS rebinding 攻击
- `player_profile.py`：玩家档案路径、统一 JSON schema 校验、旧格式兼容转换、State Keeper 模型自然语言整理、prompt preview 渲染，以及 selector 可检索的详细 profile section 构建；保存时固定 schema，避免任意嵌套 JSON 继续扩散到 runtime
- `server.py` 当前默认绑定 `127.0.0.1:8765`，可通过 `THREADLOOM_HOST` / `THREADLOOM_PORT` 覆盖，并统一设置基础安全响应头、JSON API `no-store` 与请求体大小上限
- `local_model_client.py`：本地模型调用（含 429/503 自动重试）；调用方必须显式提供 `base_url` 与 `model`，不再内置旧本地模型默认值
- `card_hints.py`：卡级语义提示加载器，从 `character-data.json["hints"]` 读取实体分类 token、NPC 角色映射、persona 原型等
- `name_sanitizer.py`：实体名清洗与人物性校验；过滤时间、空间、规则、栏目、盲区等抽象/结构标签，提供 `sanitize_runtime_name()` 与 `looks_like_bad_entity_fragment()` 等共享校验函数
- `state_bridge.py`：root `memory/state.md` 到 session-local `state.json` 的桥接；负责 state 清洗、稳定合并、当前时间粗时段归一化、抽象/非人物 entity 过滤、onstage 当前证据校验、thread actor canonicalize/prune、`relevant_npcs` 收敛、object lifecycle、possession/visibility 合法覆盖、当前场景物件 stale guard 与 `knowledge_scope` 本轮 delta 标准化；同时承载纯 entity/object/signal 标准化 helper，供 keeper/fallback 路径复用
- `state_fragment.py`：state fragment 构建；以 skeleton keeper 输出与 arbiter 结果为基线生成 `state_fragment`，作为 narrator 与 fill keeper 的结构化锚点；`build_state_from_fragment()` 在非合并轮替代 full fill keeper 做轻量 state 更新
- `state_keeper.py`：优先用统一模型调用链提取结构化 state（数据驱动，不依赖特定角色卡）；fill prompt 当前维护核心场景修正、事件级 `scene_objective`、物品、持有关系、情报、信号、`turn_event_summary`、有正文证据的 `npc_relationships` 增量，以及 `persona_patches` 表达层人格补丁；不维护 NPC 姓名/身份/外貌等基础设定；fill 输出按增量 patch 处理，不应全量重写 object / knowledge 层；`persona_patches` 只允许写入既有非主角 `actor_id` 的语气、行为模式、决策偏好、习惯动作和受压反应，且会清洗换行、prompt block 标记和指令式文本；`call_state_keeper()` 只返回归一化 state，不直接落盘，最终持久化由 `handler_message.py` 在 arbiter/thread/actor 合并后统一完成；若模型返回 `finish_reason=length`，该 keeper 输出会被视为失败，避免半截 JSON 进入记忆层
- `state_updater.py`：离线 replay / rebuild 工具链中的保守兜底；在线主链失败时优先走 `state_fragment.build_state_from_fragment()` 的 `fragment-baseline`
- `summary_updater.py`：围绕当前 state + 最近 turn 生成 session-local summary；当前主要作为写回 / 调试产物，不再进入 narrator 主输入
- `summary_chunks.py`：固定 12 轮分段 dense summary；旧 chunk 不重写，供 selector 在 12 轮外检索回流；chunk 保存 `time_start/time_end` 作为窗口时间范围；`actors_mentioned` 会过滤非人物/抽象话题，并对源窗口中已知的主角名做保守一致性修复，避免 selector 以后按伪 actor 或主角错字召回。统一记忆事务模式下，新 chunk 使用 heuristic 生成；legacy LLM chunk 若返回 `finish_reason=length` 会降级 heuristic 并记录拒收原因
- `lorebook_distiller.py`：角色卡导入 / 手动重建时把 `lorebook.json` 固化为 `lorebook-foundation.json` 与 `lorebook-index.json`
- `world_builder.py`：在 lorebook 蒸馏之后生成 `world-bible.json`（card 条目确定性抽取 + Nemotron Ultra 推断补全，card 永远优先）。需要 `NEBIUS_API_KEY`；没有 key 时只写 card 条目。手动重建（与 `lorebook_distiller.py` 相同的调用方式，先 `pip install -r requirements.txt`）：
  ```bash
  python backend/world_builder.py --source-root <character source dir> [--force] [--no-llm] [--no-tavily]
  # 或：python -m backend.world_builder --help
  ```
- `persona_updater.py` / `persona_runtime.py`：legacy session-local persona 流转、重要度计数、近期观察沉淀与展示骨架；observation 只来自 assistant 叙事中与 NPC 相关的短片段，不把用户 prompt 原文固化为 NPC 事实；抽象话题和结构标签不会生成 persona seed。统一记忆事务模式下，在线主链跳过该 display-name keyed 写回，改由 `state_keeper.persona_patches -> state.actor_persona_hooks` 维护 actor-id keyed 表达钩子，避免 persona updater 另跑一套历史启发式写回污染同一轮记忆
- `arbiter_runtime.py` / `arbiter_state.py`：最小 arbiter 主链与状态合并
- `turn_analyzer.py`：用户输入 + scene signal 的统一分析层
- `thread_tracker.py`：active threads 更新；按类型分级保留（`THREAD_RETENTION_CONFIG`），含 `cooling_down` 中间态和 `resolved_events` 归档；最终 actor 索引由 state normalization 对齐和剪枝
- `actor_registry.py`：narrator 回复后的不可变角色注册表；只创建新 actor，已有 actor 的姓名、别称、性格、外貌、身份不再覆盖；内置 protagonist 会从玩家档案沉淀公开身份、私密身份、外貌与知情边界；同时维护 12 轮未提及归档索引，并把物品 / 情报绑定到 `actor_id`；`knowledge_records` 吸收本轮 `knowledge_scope` 时会做轻量相似去重；Keeper 输出的 `npc_relationships` 会在这里绑定到既有 NPC actor 的 `relationship_to_protagonist`；LLM candidate 在创建前会再过人物性/抽象名校验
- `entity_candidate_judge.py`：entity 候选人物性校验统一入口；调用 LLM 判定候选名是否为真实人物角色，过滤时间/空间/规则/结构标签；`state_updater.py` 复用此入口，不再在 `state_bridge.py` 中重复 judge
- `memory_maintenance.py`：长期记忆维护层；按 actor registry 的精确 alias 做跨 state / event / summary chunk / keeper archive canonicalization，并清理“人物已在场但旧风险仍称其在门外等待”的 stale signal/thread。该层只做确定性维护，不通过正文推断新人物等价关系；`rebuild_derived` 会先清空 summary chunk 缓存再用 heuristic 重建，并用无 LLM 的 keeper archive rebuild 修复派生缓存污染
- `memory_agent.py`：跨轮相关记忆召回工具；对历史 turn pair 做 token overlap 评分，选出与当前场景/玩家输入最相关的若干段对话作为 memory bundle
- `keeper_contract.py`：Keeper 字段常量定义（`SCENE_CORE_FIELDS` 等），供 keeper 系列模块共享
- `keeper_record_retriever.py`：Keeper 归档记录检索；从 archive 中按 topic / location / query 相关度取回有效记录，供 selector 与 context_builder 使用
- `mid_context_agent.py`：中段摘要生成 agent；当对话窗口中段需要 keeper archive 刷新时，生成结构化的场景摘要并写入 archive
- `continuity_hints.py`：连续性提示加载封装；从 `runtime_store` 读取 continuity_hints，供上下文装配层使用
- `event_ledger.py`：事件账本；产出阶段事件摘要并保存 `time_anchor/location_anchor`，不再负责人物短期状态写回。统一记忆事务模式下使用 heuristic ledger，不复用 keeper signals 作为事件摘要来源
- `important_npc_tracker.py` / `continuity_resolver.py`：重要人物与连续性稳定器；`relevant_npcs` 标准化只保留当前信号层明确命中的非 onstage 稳定人物，供 selector 继续召回
- `fact_log.py`：记忆 V2 核心（默认影子；`WRITE_IMPORTANT` 可接管 `important_npcs` 写回）；append-only facts + `Resolver` + `commit_turn / seed_from_state / project / retrieve / merge_projected_important_npcs / truncate_after`。`project()` 出 onstage/important/last_event（查询）、persona、knowledge_boundary、relation；important 过滤 = ephemeral + **inactive≥20 淡出**（persona 锁定例外）。设计见 `doc/MEMORY-V2-DESIGN.md`，双轨进度见 `doc/WORKPLAN-FACTLOG-DUAL-TRACK.md`
- `fact_retrieval.py`：V2 读侧第三个纯函数 `retrieve()`（设计文档里长期空着的那格）——长尾召回 = **三车道 RRF 融合**：近窗 recency / **BM25 词法**（k1=1.5、b=0.35；CJK char bigram + 实体别名整词 `@term`，无分词器依赖；`present` 行不入索引）/ **实体链接**（query 或当前在场的实体名/别名经 `canon_eid` 折叠取其自有事实，durable 与 beat 交替）。车道权重 lexical 1.0 / entity 0.6 / recency 0.35（近窗本来就在上下文里，故不该占头部）。融合的是 rank 不是分数 → 后加 embedding 车道无需重调前三条。每条 hit 带 `span` 回源，`supersedes` 的旧行不召回。纯函数、无 I/O、无缓存索引
- `persona_distiller.py`：从 NPC 言行用**一次** LLM 提炼稳定性格（只写"是个怎样的人"、排除对主角态度），剥 JSON 回显 + 校验拒绝；由 `handler_message._consolidate_factlog_personas` 在 consolidation turn 调用、每 NPC 一次、锁定
- `opening.py`：opening 菜单与开局状态机；菜单/direct-start 仍可保存阶段 checkpoint，但 opening choice 进入首个 narrator 回合时可跳过 checkpoint，由 `handler_message.py` 在该 turn 结束时统一提交最终 state
- `card_importer.py` / `import_character_card.py`：角色卡导入与规范化产物生成
- `character_assets.py`：角色卡 source 目录下的导入产物与封面资产读取
- `character_manager.py`：角色卡管理 API 处理层；角色卡列表枚举、切换、删除与封面/缩略图读取
- `session_lifecycle.py`：new game / delete / session list
- `regenerate_turn.py`：partial 回复回滚与重试
- `tools/replay_turn_trace.py` / `tools/rebuild_session_from_history.py` / `tools/repair_session_memory.py`：当前调试工具，用于单回合精确回放、从历史重建副本 session，以及对既有 session 运行 deterministic memory repair。`repair_session_memory.py` 默认 dry-run，只有显式 `--apply` 才写回
- `user_manager.py`：多用户管理模块（bcrypt 密码认证、session token 管理、登录失败锁定、用户禁用/启用/归档删除、孤儿目录审计、用户生命周期）
- `object_bootstrap_agent.py`：物品抽取 bootstrap（四策略启发式→LLM判定→merge）
- `clue_bootstrap_agent.py`：情报抽取 bootstrap（模式匹配→LLM分类→merge）
- `npc_bootstrap_agent.py`：NPC抽取 bootstrap（对话启发式→LLM分类→merge）
- `import_sillytavern_chat.py`：SillyTavern JSONL 聊天记录导入（CLI + API）

## 当前主策略

当前已经不是 stub backend，而是最小可运行主链：
- narrator 已接上真实模型调用
- 新 session 会继承 root `canon / summary / state`
- state / summary / persona / threads / important NPC / actor registry 都已接入 session-local 写回
- narrator 当前默认只吃低干扰上下文：`runtime_rules / preset / slim character_core / player_profile / actor registry / scene_objective / items / knowledge / keeper archive hits / recent window 前段提纲 / 最近完整正文 / user input`
- `player_profile` 当前由统一 JSON schema 渲染为短常驻 prompt block；用户自然语言源文本只用于整理和审计，不直接进入 narrator prompt。详细背景、心理、能力、私密边界等数组项会拆成 `player_profile_detail` section，只有 selector 按本轮强锚点命中时才进入 `【命中玩家档案细节】`。
- `state` 的 `time/location/main_event/onstage` 不再进入 narrator prompt；当前事实以最近完整正文 + 前段提纲 + 本轮输入为准
- `event` 不再写回 state；每轮 event summary 可作为 recent window 前段提纲和事件时间轴进入 narrator，12 轮外历史仍由固定 `summary_chunks` 通过 selector 条件召回；summary chunk 进入 prompt 前会经过 quarantine，明显主角名漂移的 chunk 不会注入
- 世界书默认分三层消费：首个 narrator 回合注入原始 alwaysOn/foundation 世界书的大预算片段；后续每轮常驻短 `foundation` 护栏；情境条目由 selector / index 命中后回源到原始 `lorebook.json` 片段注入。世界书不是当前场景事实源
- `state_keeper` 优先，在线失败时以 `state_fragment` 形成 `fragment-baseline` 兜底；`state_updater` 主要保留给离线工具链
- `state_keeper` 写出来的 state 在合并后会再走一层 `_apply_field_acceptance` per-field 校验：`onstage_npcs` 在 location 未变时被清空，或 location 与 main_event 不一致地切换，单独回退该字段到 prev_state，整张 state 不再因为一格崩坏而走 `fragment-baseline`。被拒字段会触发一次 corrective retry，结果落在 `state_keeper_diagnostics.field_acceptance` 与 `provider_used: llm-fill-partial`
- `_apply_field_acceptance` 另加了“远程/回忆提及不重置在场名单”：`_name_has_current_text_evidence` 排除只经 memory / off-scene 标记（回想 / 想起 / 心里 / 窗外 / 远处 / 隔壁 / 后厨飘出…）出现的名字，要求名字上有当下动作动词、或主角朝其互动，才算当前正文证据，避免正文里“被回忆到”的路人被重新拉回 onstage（commit `5b65c54`）
- narrator 正文另有 NPC 知情边界守卫（commit `ff3eb04`）：在场 NPC 不得回应主角未说出口的问题、或泄露其私下探查（贴符/夜探/路线/内心推演）。`_unsupported_unspoken_user_question_reason` / `_unsupported_npc_private_knowledge_reason` 命中会触发定向 corrective retry（复用 scene-shift / prior-event 那套拒收+重试机制）；`build_narrator_input` 注入【当前在场 NPC 知情核对】块列出各在场 NPC 已登记知情；`state_keeper` 侧则拒收“逼主角当面告知私密”的 `immediate_goal`（除非正文/用户输入明说）
- arbiter 已接入主链，不再只是文档占位
- partial reply 有独立处理路径，不再继续污染事实层
- partial reply 当前会在生成阶段被阻断：`finish_reason=length/error` 或半句式结尾会触发 narrator 重试，重试耗尽后返回空回复错误；旧 partial 历史在 `/api/history` 和 prompt recent window 中会连同对应 user 输入一起过滤
- opening 已升级为独立状态机
- session 生命周期已覆盖：新游戏、切换、删除、partial regenerate
- 同一 `session_id` 的写请求现会串行执行，降低并发写冲突
- session 访问会先检查当前角色卡作用域；如果同名 session 存在于其他角色卡下，`state/history/message/regenerate/delete` 等入口会拒绝继续使用，避免旧 session 在切卡后被当前角色卡上下文污染
- `history` 读取缓存按解析后的 `history.jsonl` 绝对路径隔离，不再只按裸 `session_id` 复用，避免不同角色卡/用户下同名 session 串 history
- `history.jsonl` 仍是 legacy 原始流水；每次 `save_history()` 会同步派生 `memory/history_manifest.json` 与 24 轮一片的 `memory/history_shards/turns-000001-000024.jsonl`。运行期 recent window 与旧事件回源优先读 shard，若 manifest 过期、缺 shard 或 shard 覆盖不完整则回退到 legacy `history.jsonl` 并重建派生 shard。
- 角色卡导入与聊天导入使用请求局部 override；`character_assets` 与 `paths.active_character_id()` 的临时 override 不再是跨线程共享状态
- persona root seed 默认只读取当前角色卡 source 下的 `runtime/persona-seeds`；缺失时不再静默回退到仓库共享 `runtime/persona-seeds`
- 会话归档功能已取消：新游戏只创建新 session，不再把旧 session 移动到 `archive-*`；session list 也不再返回 `archived` 字段。历史 `archive-*` 目录仅作为旧数据存在，不进入当前会话列表
- `state_keeper` 已加入低信号拒收与回归检查
- `state_fragment` 已前移到 narrator / state_keeper 主链，并在失败分支提供 `fragment-baseline`
- 统一记忆事务当前默认启用：每个完整 runtime 回合都由 full `state_keeper` 承担唯一 LLM 记忆 patch；skeleton keeper、actor registry LLM、possession retry LLM、event ledger LLM、summary chunk LLM 在统一模式下关闭，避免多路 LLM 对同一轮剧情各自写回
- 完整 `state_keeper` 当前已切到 `fill-mode`：先以 `state_fragment` 形成基线，再只补物品、情报与信号；统一模式下每轮运行，不再由 skeleton/fill 双 LLM 分摊同一轮记忆解释权
- 统一模式下 NPC 表达层人格也走同一次 `state_keeper` 输出：`persona_patches` 经 actor_id / display_name 精确校验后合并到 `state.actor_persona_hooks`，narrator 在 `【角色注册表】` 中按 actor_id 注入这些语气、行为和习惯动作提示；旧 persona seed 仍可作为 NPC profile fallback 读取，但不会作为 `【NPC 表现层人格】` 自动注入当前 prompt
- actor registry 当前在每个完整 narrator 回复后运行：narrator 后处理只允许创建新 actor，已有 actor 的姓名、别称、性格、外貌、身份视为锁定，不允许后续覆盖；统一模式下不调用 LLM 新建 actor，只保留确定性 alias、mention、binding 和关系落点维护，避免把旧污染写成不可变设定
- actor registry 对“实名揭示”有窄口径例外：若已有 generic actor 后续在 narrator 正文中明确自报姓名或被点名，且上下文能唯一绑定到该 generic actor，则只追加实名到 `aliases` 并更新 mention turn，不改写原 `name / personality / appearance / identity`
- actor registry 会接收 fill keeper 的 `npc_relationships` 临时 patch，把“初识 / 相知 / 好友 / 队友 / 盟友 / 敌对 / 戒备”等自然标签写入既有 NPC actor 的 `relationship_to_protagonist`。关系标签是长期关系面，不改写 NPC 基础设定；必须有本轮 narrator 正文证据，不能从玩家单方面声明直接成立。
- memory maintenance 会在 actor registry 后运行，把已知 exact alias 迁移到 canonical actor name；冲突 alias 会被跳过，避免两个不同 actor 因同一称呼被自动合并
- actor / persona / selector / summary chunk 共享非人物名防线：时间、空间、规则、栏目、盲区、题目等抽象或结构标签不能因 LLM 附带“外貌/身份”字段就被固化为 NPC。
- actor registry 创建新 actor 时会读取最近 1~3 对 turn，因此上一轮 actor registry LLM 失败后，下一轮仍可从 recent window 补建，不需要依赖脏 fallback
- actor registry 已内置 `protagonist`，物品持有和情报记录可统一绑定到 `actor_id`；`possession_state` 会补 `holder_actor_id`，`object_visibility` 会补 `known_to_actor_ids`，本轮 `knowledge_scope` 会派生长期 `knowledge_records`
- protagonist actor 会把玩家档案拆成 `public_identity`、`private_identity`、`knowledge_boundary` 与 `appearance`：公开伪装、可见外貌和他人可观察身份可进入 NPC 判断；真实性别、隐藏身份、伪装底细等私密事实只有在 `knowledge_records` / 本轮 `knowledge_scope` 明确证明对应 NPC 知情时，才能被 NPC 对白、称呼或判断承接
- 玩家档案 API 当前返回自然语言源文本、统一 JSON 和 prompt preview。`/api/user-profile/normalize` 与 `/api/character/profile-override/normalize` 使用 State Keeper 模型把自然语言整理为固定 JSON；`/preview` 路径只校验并渲染，不保存。保存接口会拒绝未知字段和错误类型，失败时不会覆盖旧 JSON。
- 12 轮未被正文提及的 actor 会进入 `actor_context_index.archived_actor_ids`，只影响后续上下文注入，不修改 actor 基础设定；再次被正文提及时会回到 active
- 每满 12 个完整 user/assistant pair 生成一个不可变 dense summary chunk，保存到 `memory/summary_chunks.json`；chunk 覆盖固定区间，不重叠、不滚动覆盖
- opening-choice 分支现在不再“只生成正文然后直接返回”；首轮开局正文会进入 `state_fragment -> skeleton keeper -> fill keeper -> thread/important_npc` 写回链，避免正文与 state 从第一轮开始分叉。当前这条链通常能落下 `time/location/main_event/onstage/immediate_risks/carryover_clues`，但 `immediate_goal` 仍可能偏保守
- `main_event` 与 `active_threads.main.label` 当前已改为条件同步：不再让较慢更新的 `main_event` 无条件覆盖主线程标签；只有当 `main_event` 质量明显更高，或主线程标签仍是占位值时，才允许它接管主线程标签
- `active_threads` 当前已降为“state/debug 辅助层”的实验状态：数据结构仍保留，但不再默认进入 narrator prompt，也不再作为 selector 的主要命中依据；归一化层也不再允许它反向补 `relevant_npcs / scene_entities / main_event`
- `carryover_signals` 统一信号层已接入状态 schema并真实落盘：设计目标是让 keeper 优先维护“后续仍会影响局势的统一信号”，再由兼容层派生旧 `immediate_risks / carryover_clues`；当前真实回合里 keeper 仍常直接产出旧字段，但状态归一化层已会把旧字段反推回统一信号层并持久化
- `scene_objective` 是轻量事件级目标锚点：keeper fill 只在目标缺失、明显开启新任务/新场景主轴或目标明确结束时更新；narrator 注入 active objective 来约束本轮围绕事件目标推进，避免把 `immediate_goal` 误用成宏观训练/事件目标
- 离线 `state_updater` 路径当前也会补 `carryover_signals`；在线主链则由 skeleton / fragment / fill keeper 维护统一信号层，`thread_tracker / context_builder / state_snapshot` 等核心消费点已开始优先使用统一信号层，再兼容旧字段
- `onstage_npcs` 当前只作为 state/UI 快照存在，不进入 narrator 主 prompt，也不承载长期人物基础设定；长期人物基础设定进入不可变 `actors`
- `onstage_npcs / relevant_npcs / scene_entities` 当前必须有正向人物证据：稳定 actor、important NPC、continuity hint、明确人物 role，或正文/事件中“人物称谓 + 行动锚点”。地点、标题残片、事件短语不能从 `main_event/location` 反推出 NPC
- `onstage_npcs` 还必须有当前回合证据；场景切换后，即使 actor registry 中存在核心 NPC，也不能仅凭历史重要性继续保留在场。state keeper validation 允许有新 location/main_event 的空 onstage payload。
- source NPC profile 缺失时，当前 session persona seed 可作为 narrator NPC profile 兜底；该 profile 只包含身份、hooks 与近期 observation，不覆盖 actor registry 的不可变人物基础设定
- session persona observation 只从 assistant 叙事中提取，不从用户 prompt 原文生成 NPC 事实；输出到 narrator profile 前会去重，避免同一观察片段在 behavior/detail/snippet 中重复放大
- keeper archive 的 heuristic digest 当前会消费 NPC registry，以提升中程窗口的 stable_entities / ongoing_events 密度；archive 仍是派生缓存，不是权威事实源
- keeper archive 构建/读取时会运行 deterministic validation：删除坏窗口、空记录和已知摘要碎片，保护 `manual-cleanup` 人工记录；离线 repair 可在 dry-run 中报告并在 `--apply` 时写回这些派生缓存清理
- narrator prompt 当前不靠列举“翻墙/离场”等剧情关键词维持连续性，而是通过 recent window（前段提纲 + 近端完整正文）和通用原则约束空间关系、视线范围、人物控制权与行动链的承接
- narrator / arbiter / selector 对低压 turn 有共同降压规则：普通阅读、坐下、休息和无明确潜行收益的隐蔽位置不会自动升级为 stealth risk；旧高压 chunk 若只靠人物名或压力词命中，会被降权。
- selector 对固定 summary chunk 的召回要求当前 turn 具备强语义锚点；泛化助词、动作残片、称呼残片和仅来自旧 `knowledge_records` 的弱 overlap 不足以把远期 chunk 拉回 prompt。这样避免长 session 中旧摘要靠“的/呼吸/某人的”等弱 token 误回流，同时不依赖具体角色名、剧情物件或 session id。
- runtime heuristic / prompt examples 当前避免绑定具体角色卡或 session：summary keyword 示例、clue 组织触发词、persona archetype 兜底和 state fallback 物件提示均应使用通用职能/物件词，不使用某张卡的固定角色名、组织名或剧情专属物件来强化表现
- 当前目标分工草案：
- `event`：中程检索层，服务于 recall / summary，不默认主导 narrator
- `signal`：当前方向约束层，可直接进入 narrator / selector
- `summary`：长程压缩层，只在 recent window 不足时条件回流
- `thread`：state/debug 辅助层，当前实验中已去主导化
- `actor registry`：长期人物基础设定层，只创建新 actor，不维护短期状态

当前 `event` 链的实现边界：
- event 当前已改为真正读取最近 `1~3` 对 `user/assistant` 窗口，而不是只摘要当前轮 narrator prose
- `prev_state` 当前已在调用侧修正为“本轮前状态”，避免 event 用当前态伪装上一轮状态
- event 当前不再输出或合并 `status_transitions`；短期状态只保留在最近窗口 / 当前硬锚点，不写入长期 actor 基础设定
- heuristic fallback 当前也按多回合窗口工作，不再优先挑天气/氛围句；当前仍可能不如 LLM 版本稳定，但 summary 已开始更像阶段事件压缩器
- 离线 `state_updater` 已更偏保守继承，不轻易覆盖已有高信号状态
- narrator 对“半句中止但 provider 未标 partial”的返回增加了不完整输出保护，避免坏回复继续污染事实层
- state fallback 现在会更严格地区分“可持续追踪物件”和“短语残片 / 动作词片段”
- 已支持对旧污染 session 做离线重建，直接修复 `state / threads / important_npcs / summary`
- state snapshot 已可直接提供前端实体展示结构
- web 配置项中的 `default_debug / show_debug_panel / history_page_size` 已可驱动 API 与前端
- 前端默认会话选择已改为最近更新会话优先
- 角色卡信息当前会动态读取角色卡元数据和缩略封面图；角色卡切换与导入入口现已主要收进设置面板
- narrator prompt 已加入更通用的知情边界约束，减少 NPC 间私下信息自动外溢
- NPC 间信息隔离已升级为结构化知识系统：keeper 每轮只提取本轮新增 `knowledge_scope` delta，`state_bridge.py` 只保留本轮 delta 不再长期合并，`actor_registry.py` 派生 actor-id 版长期 `knowledge_records` 并做轻量相似去重，`narrator_input.py` 渲染为结构化知情边界
- 核心可变 JSON / 文本写入已改为原子写入模式（`_atomic_write_text()` / `_atomic_write_json()`）：写临时文件 → fsync → `os.replace`（POSIX 原子），防止崩溃/断电导致数据损坏。删除、导入、repair 等路径仍可能有非事务性文件操作，不应理解为跨 artifact 数据库事务。
- 模型调用已加入 API 韧性层：`_retry_on_rate_limit` 装饰器在 429/503 错误时自动指数退避重试（最多 3 次），尊重 `Retry-After` 响应头；远端和本地模型调用均已覆盖
- 模型站点配置已加入 SSRF 与密钥外送防护：远程 `baseUrl` 必须使用 HTTPS，私网/link-local 等直接 IP 会被拒绝；切换站点 URL 时若未重新输入 API key，会清空旧 key。本地模型 helper (`local_model_client.py`) 现也统一走 `safe_http.open_safe_connection`，对 `127.0.0.1`/`localhost`/`::1` 放行，对其他私网/link-local 地址同样拒绝；如需把本地模型放在反向代理之后，请使用 loopback 端口。
- 前端 assistant markdown 渲染已增加轻量净化，CSP 也补充 `object-src 'none'`、`base-uri 'self'`、`frame-ancestors 'none'`
- `summary` 与独立 `mid digest` 当前不再作为 narrator prompt 的主输入块
- 世界书注入当前已改成“开局原文定底 + 导入期蒸馏护栏 + 运行期 selector 回源”：避免普通回合每轮塞整段 raw lore，同时避免只给蒸馏摘要导致 narrator 误以为世界书只有摘要内容
- 导入器会在写出 `lorebook.json` 后生成两个缓存文件：
  - `lorebook-foundation.json`：每轮常驻的短世界基础 / 身份边界 / 规则口径
- `lorebook-index.json`：条件召回的情境 lore 索引，条目保留 `source_entry_ids`；其中 `keywords` 只作为检索索引，不作为剧情触发规则。运行期命中 index 后优先按 `source_entry_ids` 回到 `lorebook.json` 取原文片段，而不是直接把蒸馏摘要当完整知识交给 narrator
- `lorebook_distiller.py` 默认尝试用 `state_keeper_candidate` LLM 蒸馏；该 role 固定继承 State Keeper 模型，只保留独立低温 JSON 输出参数，不再单独维护 hidden 模型。遇到空回复或 JSON 解析失败会自动重试；仍失败时使用 heuristic fallback，并在产物 `provider` 字段标记
- narrator prompt 中对应块为 `【世界书基础规则】` 和 `【情境世界书】`；`【世界书基础规则】` 明确标注为“不完整常驻护栏”，`【情境世界书】` 标注为 selector 命中后的相关世界书内容。旧 raw `【世界书】` 块不再作为普通回合默认入口
- 情境世界书默认先用 index 小预算定位（当前默认 2 条 / 约 700 字），再回源注入原始条目片段（默认约 1800 字），避免普通观察轮因 recent window 中出现世界名词而召回过多 lore，同时保留原文约束与局部结构
- turn trace / debug 当前会自动记录：
  - 实际注入的 lorebook 条目列表
  - 蒸馏 foundation 与 index 命中来源
  - index 命中后的原始世界书回源片段 `source_hits`
  - `【世界书基础规则】` / `【情境世界书】` 总字符数
  - prompt 各大区块字符占比

### 调试面板与长 session 稳定性口径

调试浮动面板展示的是本轮注入和写回诊断，而不是完整记忆表。当前应重点看这些块：

- `Prompt Blocks`：确认 `【重要物件与持有关系】`、`【命中事件索引】`、`【召回的归档提纲】`、`【keeper archive 命中】`、世界书块等是否真实进入 prompt，以及各自字符数。`【召回的归档提纲】` 只应在 selector 强锚点命中且事件索引不足以覆盖时出现，不再作为固定 12 轮历史默认入口。
- `Lorebook Injection`：普通回合可能只注入 foundation / index / source 命中的小块。判断实际体量时优先看 `selected_summary_chars / source_hit_chars / index_hit_chars / foundation_chars / effective_total_chars`，不要把旧 `total_chars` 当作最终入 prompt 总量。
- `Event Memory`：显示事件摘要数量、selector 是否注入 summary、`event_hits` 和最新事件摘要。selector 现在要求当前 turn 强锚点；普通日常物件词或弱 topic overlap 不应单独把旧 event / summary 拉回。
- `Diagnostics`：保留 `state_keeper_diagnostics`、selector 完整决策、arbiter 结果、completion / finish reason、state/model error 等排错字段。

与这次长 session 修复相关的调试解释：

- header/date/location 是 metadata，不应作为 `main_event`。若调试中看到 `main_event` 被纯日期/地点 header 污染，应看 state normalization 是否回退到上一条有效事件或后续动作句。
- current-turn `onstage_npcs` 来自 skeleton/current marker，是短期参与者证据；最终 state snapshot 不应保留私有 `_current_turn_onstage_npcs`。
- `scene_objective` 是当前事件目标，`immediate_goal` 是主角下一拍；调试面板同时显示二者，便于判断 keeper 是否把宏观目标和下一步动作混在一起。
- `tracked_objects / possession_state / object_visibility` 只表示仍可行动的 active 物件。已吃完、丢失、销毁或归档的普通物件退出 active 列表，进入 `graveyard_objects` 防止幻觉复活。
- 具体物件来源、剩余量、当前位置和谁知情，必须来自最近正文、本轮输入或已注入物件/知情证据；narrator prompt 已明确禁止无证据具体化这些细节。

## 当前配置边界

当前配置层已经分成两类：

- 共享配置：
  - `config/runtime.json`
  - 用于内容层来源、全局运行策略、默认模型参数

- 用户配置：
  - `runtime-data/<user>/config/site.json`
  - `runtime-data/<user>/config/model-runtime.json`
  - 用于当前用户自己的站点、模型选择

当前明确结论：
- 单用户当前可用，默认用户目录是主工作路径
- 单站点是当前产品层简化，不是永久平台承诺
- `Narrator / State Keeper` 已有用户级模型选择
- `Analyzer / Arbiter` 这类高级角色当前不暴露给普通用户界面，但仍可通过用户级 `model-runtime.json -> advanced_models` 做高级覆盖；Skeleton Keeper / Lorebook Distiller 走 `state_keeper_candidate`，固定继承 State Keeper 模型
- 当前角色卡管理也已进入 Web UI：
  - 当前用户角色卡列表可枚举
  - 可切换当前活跃角色卡
  - 可在设置面板内导入新的角色卡
  - 当前默认用户标签固定显示为 `default_user`
  - 默认仍可作为单用户 `default-user` 使用；启用多用户后，管理员可创建用户、重置密码、禁用/启用用户、归档删除用户并切换多用户模式
  - `/api/auth/*`、`/api/users`、`/api/multi-user` 是 v1.0 多用户产品面的一部分；state-changing 请求要求 Bearer token，拒绝 Cookie auth
  - `state_keeper_candidate` 当前继承 State Keeper 模型，不再使用 hidden 单独模型配置
  - 三条 bootstrap（NPC/物品/情报）均已通过 LLM 回合测试

当前建议配模方向：
- narrator 继续使用强远端模型
- `state_keeper_candidate` 固定继承 `state_keeper` 模型；只需要在设置页选择一个稳定的 State Keeper 模型
- skeleton keeper 和 fill keeper 均使用同一模型，通过 prompt 分工
- 当前 keeper 主链路是：
  - `skeleton keeper`（继承 State Keeper 模型）→ 最小骨架
  - `fill keeper`（State Keeper 模型）→ 补物品、情报与信号
  - `heuristic fallback` → 最终兜底
- `fill keeper` 当前按增量 patch 思路运行：已有 NPC / 物件默认沿用，只在明确新增或明确变化时输出；若本轮改变已有物件的位置、持有或物理状态，必须用同一 `object_id` 输出完整最新 `possession_state`，由归一化层覆盖旧状态。`npc_relationships` 只输出本轮关系增量，最终由 actor registry 绑定后移出顶层 patch。
- NPC 与物件绑定当前由 `possession_state` 驱动：标准化层会把 holder 对齐到稳定 NPC 主名，并自动写回 `tracked_objects[].owner / bound_entity_id` 与 `scene_entities[].owned_objects`；新 holder 必须来自当前人物、scene entity、actor registry 或 protagonist aliases，非法 holder 不覆盖旧合法归属
- object 层支持 `lifecycle_status: active | consumed | destroyed | lost | archived`；非 active 物件会从 active `tracked_objects / possession_state / object_visibility` 退出，并写入 `graveyard_objects` 防止后续幻觉复活
- object 层还有确定性 stale guard：当当前 `main_event / location / signal` 已经表明主角带着或收起某物，而旧 `possession_state` 仍写着溪水中、桌上、床边等过期场景落点时，归一化会清掉旧落点并降级旧状态为通用 carried，等待下一次 keeper 明确写入新位置。
- turn_analyzer 可在 narrator 不变前提下评估是否跟着切本地

## 多用户后端安全边界

当前多用户仍是本地优先产品面，不按 SaaS 平台设计，但后端已做以下边界：

- 账号注册表是 `runtime-data/_system/users.json`；登录与用户列表以该文件为准，单纯存在 `runtime-data/<name>/` 目录不代表可登录账号。
- Session token 存在 `runtime-data/_system/sessions.json`，仅保存 token hash；token TTL 为 30 天，用户主动登出或管理员禁用/删除用户会立即撤销相关 token。
- `validate_token()` 会确认 token 指向的用户仍在账号注册表中且未被禁用；已删除或已禁用用户的残留 token 会被拒绝并从 sessions 中移除。
- 每个用户最多保留 10 个活跃 token；新登录超过上限时按 `last_seen_at / created_at` 淘汰最旧 token，异常时间戳按最旧处理，避免坏 session 元数据阻断登录。
- `disable_user()` 只标记普通用户 `disabled_at` 并撤销其全部 token，不移动数据目录；`enable_user()` 清除禁用标记。
- `delete_user()` 是归档删除：先把 `runtime-data/<user>/` 移动到 `runtime-data/_system/deleted-users/<user>-<timestamp>`，成功后才删除账号记录和 sessions；如果移动失败，账号和 token 保持不变，方便重试或人工处理。
- `archive_orphan_user_dir()` 只处理不在账号注册表中的孤儿用户目录，把它们移动到 `runtime-data/_system/deleted-users/<user>-orphan-<timestamp>`；已注册用户和 `default-user` 不允许走孤儿目录归档。
- `list_user_storage_audit()` 会返回 `orphan_dirs / missing_dirs / deleted_archives` 给管理员，用于发现未注册但仍存在的数据目录；后端不会自动删除或自动恢复这些目录，管理员可在设置页手动归档确认无用的 orphan 目录。
- `server.py` 对 `/api/auth/login` 做进程内 per-IP 与全局窗口限速；这只降低本地服务的暴力尝试成本，公网/反代部署仍应在代理层限流。
- `startup_security_check()` 在后端启动时收紧 `_system/users.json` 与 `_system/sessions.json` 权限到 `0600`、清理过期 session；当监听非 loopback 地址但多用户未启用或管理员密码未设置时默认拒绝启动。
- 管理员密码首次设置的无 token bootstrap 只允许本机地址访问；公网部署应先在本机完成管理员密码和多用户启用，再交给反向代理暴露。
- 前端第三方脚本不再从 CDN 加载；Markdown renderer 作为本地 `/marked.min.js` 静态资源提供，HTML 与服务端 CSP 均使用 `script-src 'self'`。
- 多用户开启且未认证时，`GET /` 与 `GET /index.html` 只返回最小登录页；`/app.js` 不在公开 GET allowlist 中，必须有有效 token 才返回完整前端应用逻辑。登录页只公开加载 `/login.js`、`/styles.css`、`/favicon.svg` 等必要资源。
- 普通用户对 site/provider 写接口统一走 admin-only 后端检查；即使当前 provider delete 是不支持操作，也先做权限校验再返回业务错误。

当前 keeper 调教样本分工：

- `维克托·奥古斯特`
  - 用于校准结构清晰场景下的：
    - `main_event`
    - `threads`
    - `objects`

- `九幽大陆`
  - 用于校准无系统级 NPC 前提下的：
    - 动态 NPC 抽取
    - 长文探险线物件/线程稳定性
    - keeper archive 延续性
  - 当前已经证明：
    - State Keeper 模型可以在中等窗口长跑中稳定保住人物、主事件、线程；具体模型由设置页或 `runtime-data/<user>/config/model-runtime.json` 决定
    - 弱语义 `role_label` 已开始生效，不再长期全部停在 `待确认`

- `血蚀纪`
  - 用于校准：
    - 日常互动型文本的场景锚点
    - 事件标签
    - 假人物过滤

## 角色卡导入 v1.0

当前推荐的角色卡导入产物已经改成分层结构，而不是把 Tavern 原字段直接散落到运行时文件：

- `character-data.json`
  - 角色核心、简介、来源信息、精简系统摘要
  - v1.0 完整保留以下 SillyTavern v2/v3 字段：`nickname`、`mes_example`、
    `post_history_instructions`、`tags`、`character_version`、
    `talkativeness`、`creator_notes_multilingual`、`extensions`
  - `source` 子字段记录 `creator`、`creation_date`、`modification_date`
  - 长字段使用边界感知截断（`_truncate_at_boundary`）：
    `personality` 1500 / summary 2400 / system_prompt 4000 / creator_notes 2000
- `lorebook.json`
  - 规范化世界书条目，导入器为每条补 `entryType / runtimeScope / featured`
  - 区分：foundation（底板规则/世界观）、situational（场景相关）、
    NPC / cast / faction 可调入层
  - v1.0 完整保留 SillyTavern 字段：`selective`、`selectiveLogic`、
    `position`、`depth`、`probability`、`useProbability`、
    `caseSensitive`、`matchWholeWords`、`group`、`groupOverride`、
    `groupWeight`、`vectorized`、`disable`、`extensions`、`secondary_keywords`
  - lorebook 顶层保留 `description`、`scan_depth`、`token_budget`、
    `recursive_scanning`、`extensions`
  - 仅触发用的 keyword-only 条目（content 为空但 keywords 非空）也会保留
  - 历史上曾提供过 metadata 回填脚本；这类一次性迁移工具已删除，不再作为当前维护入口
- `lorebook-foundation.json`
  - 从 `lorebook.json` 蒸馏出的常驻短世界基础 / 身份边界 / 规则口径
- `lorebook-index.json`
  - 情境世界书检索索引；命中后优先按 `source_entry_ids` 回源读取 `lorebook.json` 原文片段
- `openings.json`
  - 开局模式、开局 bootstrap、开局选项
  - `mode: direct` 表示单一开局，运行时直接展示 `menu_intro`，不追加“可用开局 / 随机开局 / 报数字”菜单提示
  - `mode: menu` 表示确实存在多个开局候选，运行时才消费 `options` 并进入 opening choice 分支
  - 单 `first_mes` 角色卡会导入为 `direct`，不会再被误当作多开局；`alternate_greetings` / `group_only_greetings` 等多个候选才会保留为 `options`
  - 每个 option 带 `kind`：`first_mes` / `alternate_greeting` / `group_only_greeting`（v3）
  - 导入期会对开局文本做基础 SillyTavern 占位符替换：`{{char}}` → 角色名，`{{user}}` → `玩家`；运行时展示旧导入文件前也会兜底替换一次
- `system-npcs.json`
  - 从导入卡中明确提取出的系统级 NPC
  - 当前分成：
    - `core`：最明确、最值得直接进入运行时的人物
    - `faction_named`：势力条目中的命名人物
    - `roster`：更边缘的命名人物
    - `items`：上述三个桶的合并（**包含 roster**，v1.0 保证，
      之前 roster 被静默丢弃）
  - 英文/拉丁文角色卡的内嵌 NPC 由 `_extract_embedded_npcs_latin` 兜底识别
- `import-manifest.json`
  - 导入来源、产物路径、统计信息
- `assets/`
  - 封面图与缩略图
- `imported/`
  - raw card 与原始 PNG 备份

当前导入命令：

```bash
cd /root/Threadloom
python3 backend/import_character_card.py /path/to/card.png
```

或：

```bash
cd /root/Threadloom
python3 backend/import_character_card.py /path/to/card.raw-card.json
```

当前运行时的消费方式：

- `opening.py` 优先读取 `openings.json`
- `context_builder.extract_system_npc_candidates` 按 `core → faction_named → roster`
  分级 fallback，直到达到 limit；每个候选带 `source` 字段（`system_npc` /
  `system_npc_faction` / `system_npc_roster`）
- `state_bridge.infer_role_label` 通过 `system-npcs.items` 查 role label
  （`items` 现在包含全部三个桶）
- `persona_updater._infer_candidate_identity` 接受任何 `system_npc*` 来源
- `runtime_store.py` / `server.py` 优先读取 `assets/` 下的角色卡封面
- 导入器当前会额外过滤 SillyTavern 前端模板、隐藏脚本、状态栏、人际模板等 runtime 噪声，避免它们进入最终 `lorebook.json`

当前目标不是“导得越多越好”，而是：

- 只保留对 runtime 真正有价值的结构产物
- 把“世界知识”“开局菜单”“系统级 NPC”“封面资产”明确拆开
- 减少旧 Tavern 前端字段、视觉字段、规则缝合内容直接污染运行时

## 开发与 LSP

当前后端仍按脚本方式运行：开发时从 `backend/` 目录执行 `python3 server.py`，测试时用 `PYTHONPATH=backend` 暴露同级模块。因此 `backend/*.py` 里的 `import user_manager` / `import model_config` 这类导入是运行时契约，不应和普通功能修复混在一起批量改成包内相对导入。

pytest 侧由仓库根 `conftest.py` 在收集前把仓库根与 `backend/` 同时放上 `sys.path`，使单文件运行（`pytest tests/test_foo.py`）与全量运行的收集行为一致，无需各测试文件各自插 `sys.path`；`pytest.ini` 的 `testpaths = tests` 让 bare `pytest` 只收集 `tests/`。依赖本地 live HTTP 服务、会改配置或使用旧 session 路径的手动脚本放在 `scripts/manual-checks/`，不进入 pytest 回归集。

仓库根目录的 `pyrightconfig.json` 与 `basedpyrightconfig.json` 用于让 Pyright / Basedpyright LSP 匹配这个现实：

- `extraPaths: ["backend"]` 让同级后端模块按脚本入口可解析。
- `reportImplicitRelativeImport` 关闭，避免把当前脚本式导入误报成项目级错误。
- 类型检查保持 `basic`，并暂时关闭 unknown / missing type argument 系列噪音；逐步类型化应按模块单独推进，不和运行方式迁移混在一起。

如果长期要改成真正 package 运行（例如 `python3 -m backend.server`），应单独迁移启动脚本、测试入口和所有导入，再收紧 LSP 规则。

## API Key 安全

`model_config.py` 支持环境变量引用：在 `providers.json` 的 `apiKey` 字段中使用 `$ENV_VAR_NAME` 或 `env:ENV_VAR_NAME` 格式即可从环境变量读取密钥。

## 当前仍不稳定的部分

- `state_keeper` 仍主要从 narrator prose 反提物品、情报与信号，actor registry 也仍是 narrator 回复后的后处理调用，而不是同一次 narrator 输出中的原生 sidecar
- keeper/event/signal/thread/summary 数据边界仍偏重叠，尤其是“事件事实”“当前方向信号”和“长期情报记录”的关系需要继续整理
- actor registry 当前只保证基础设定不可覆盖；新 actor 创建质量仍依赖模型抽取，误建一次性 NPC 的风险仍存在，但 LLM 失败时不会从旧 `scene_entities` 自动补建
- arbiter 仍主要覆盖少数高风险事件类型
- analyzer / state keeper 虽已分模，但默认配置仍偏实验态


## 近期变更

### 记忆 V2 fact-log（影子 → 可选写回）+ last_main_event 覆盖修复

- 修复 `state_bridge.py` / `important_npc_tracker.py`：离场重要 NPC 的 `last_main_event` 被每轮全局 `main_event` 无条件覆盖（典型表现：20 个 important NPC 只剩 1 个不同值，且污染 `continuity_resolver` 的 last_event==当前事件召回信号），现与 `last_location` 一样按 onstage 门控；carried 分支与 keeper-registry 兜底的覆盖也一并去掉。
- 新增 `backend/fact_log.py` + `handler_message._shadow_commit_fact_log`：单一 append-only fact 日志的影子层，每轮在权威 `save_state` 后旁路写 fact，并把投影 vs 线上 state 的 diff 写入 `<session>/diagnostics/factlog_shadow.jsonl`，全程 try/except 包住，**零行为变更**。详见 `doc/MEMORY-V2-DESIGN.md`、观察口径见 `doc/OPERATIONS.md`。
- 地基扩展（实体层 persona + 知情边界）：`Entity` 加稳定 `persona`（确立一次即锁定、叫法变了不丢 → 防"NPC 玩着变一个人"）+ 知情边界 `knowledge_boundary`（`knows` fact 白名单，实体不在其中=不知道主角隐藏事实 → 防知情边界退步，且这是证否约束、不靠检索）；`Resolver` 现消费 keeper 给的 aliases 把同一人的变体归一。
- 归并增强（commit `113ddbe`）：resolver 现还并 **前缀类别简称**（灰衣青年→灰衣青年修士）+ **晚到别名触发对已分裂实体的合并**（短工→桥上探头男人，并消费 `scene_entities` 别名）；读时经 `canon_eid` 折叠、不改 append-only 日志。仍欠并防过并：同义词（灰衣/灰布衫）、双字基名（张三/张三丰）不自动并。
- 步骤 2（narrator 接管，commit `8cd77ad`）：`narrator_input` 新增 **【人物档案·权威】块**，由 fact-log 投影提供 归并名/锁定 persona/知情边界白名单，插在旧【知情边界】/【人物注册表】前并声明冲突以它为准；`handler_message._load_factlog_view` 注入；开关 `THREADLOOM_FACTLOG_NARRATOR`（默认开）+ 回退安全。**首次改变 narrator 输出**。
- 步骤 2 名单写回（默认关，见 `WORKPLAN-FACTLOG-DUAL-TRACK.md`）：`THREADLOOM_FACTLOG_WRITE_IMPORTANT=1` 时 save 前 merge 写回 `important_npcs`、停 tracker；`project()` 另有 inactive≥20 淡出；regenerate 接 `truncate_after`。未默认开前现网仍以影子为主。
- canonical 升级 + persona 固化（commit `6ca80b5`、修复 `84c9ba5`）：resolver 把 canonical 升级到专名（沈昭 over 灰衣青年修士）；consolidation turn 用 `persona_distiller` 对"有戏份无 persona"的 NPC 各跑一次 LLM 提炼稳定性格并锁定（只写性格、排除对主角态度）。修复 `84c9ba5`：keeper 档模型把 persona 包成 JSON/回显 prompt 被原样锁死，现 `_clean_persona_text` 剥 JSON + 校验。
- narrator 模型适配（commit `229bba8` / `f6776a8` / `26545f4`）：新增 `prompts/runtime-rules-grok.md`（去 jailbreak + 鼓励铺陈 + 反套路），`context_builder` 按 narrator 模型名含 `grok` 切换；默认与 grok 规则都加**反脑补**条款（不许把未出现的既定事实写成定论，环境铺陈豁免），与 output 端 grounding guard 双道。
- P2 关系事件线 + keeper 契约 #1（commit `91f59c8` / `b959714` / `8d34b69`）：`relation` fact（label 变才追加、带 evidence+span+去箭头）→ `project()` 投影当前关系（动态）+ 关系线 → 权威块展示"对主角=…（依据）"。临时 NPC 治理：`project()` 把"恰好在场一次、离场≥2 轮"的路人挡在 important/权威块外（命名泛滥不堆进账本），实体仍留表；present==1 only，seed/仅被提及的 absent NPC 豁免。
- keeper 契约 #2/#3（commit `80cf610` + 本次）：#2 `knowledge_scope` fill-prompt 只记真·知情（主角身份/意图/秘密、剧情、关系）、不掺环境/场景/动作观察（防知情边界被污染）；#3 keeper 在 scene_entity 标同一人本轮的别称 → fact-log 据此归并（治"短工"只在正文出现）。均为 prompt 契约，fact-log 消费侧有测试，效果需真实游玩验证。
- **P1 长尾召回 `retrieve()`（commit `df2641c` / `2d09448` / `8c11415` / `2b4b071` / `3710a9d`，2026-08-26 合入 memory-v2）**：设计文档的第三个纯函数落地为 `backend/fact_retrieval.py`——BM25 词法 + 实体链接 + 近窗，三车道 **RRF** 融合，不引任何新依赖（网关无 embedding 模型、机器上也无 embedding 运行时，见下）。
  - **实测才发现的坑（依次被真实数据推翻）**：拿 c701f6（93 facts/39 轮）+ 21 条手标 query 跑分，对比它要替掉的 bigram 集合重叠基线：① 车道等权 + 按 turn 破平局 → 头部全被近窗废话占住（MRR 0.26，**比基线还差**）；② `present` 行入 BM25 索引 → 只有"标签+地点"十来个 token，被长度归一化捧到长段观察之上；③ 实体车道 durable 严格优先 → 某 NPC 八条 `knows` 吃满配额、自己的戏份进不来；④ 全局 avgdl → `knows` 行系统性压过 observation，改**按谓词分组归一**；⑤ **RRF k=60 是错的**（TREC 上千文档的标度，在 ~100 条事实上 1/(60+1)≈1/(60+15)，于是"两车道各排中游"压过"词法第一"），k=2 才对，MRR 0.48→0.71，折半检验一致；⑥ **"改写型只能靠 embedding"也是错的**——bigram 窗口把单字语义切开（赏钱/谢仙师赏、护身/护盾、骨头/鸟骨），补单字 token 后 3 条彻底漏召全救回；⑦ **但单字不能给实体标签用**——扩到第二、三个档后才暴露：拼进索引的实体标签被当正文切了单字，`扛长条物件少年` 的 `条`（该档 df=1/137、IDF 拉满）让"那**条**虫子叫什么"（量词）把这 NPC 无关的事实顶到词法第一。标签是元数据不是正文，改为**只出 bigram 和 `@整名`、不出单字**；修完三档全涨，连调参档也 0.825→0.861。回归测试 `LabelTokenTests`。
  - **跑分结果**（`scripts/recall_bench.py`，同池对比，**57 条手标 query / 3 个档**）：overall recall@3 **0.93** / recall@8 **0.96** / MRR **0.838** / 彻底漏召 **1**，基线 0.75 / 0.75 / 0.700 / 10。分层：**改写型 30 条 MRR 0.742 vs 基线 0.517**（这才是原始抱怨），逐字型 27 条 0.944 vs 基线 0.904（基线主场也不再输）。**逐档单看也全赢**：c701f6 0.861/0.759、c88796 0.866/0.725、e23032 0.782/0.606——且后两档**没参与调参**，用冻结参数跑出来的优势比调参档还大（过拟合的反面）。三档形状故意不同：5 实体 / 218 条 `knows` / 38 实体+20 条同文种子观察（旧档真实脏数据）。`--gate` currently PASS（并已加"任一档 recall@8 不得回归"），但注入仍默认关（先用影子攒真实证据）。剩余失败只有两条，**都是与原文零字符重叠的同义**（虫子/根骨蛹、跑堂的伙计/店小二），词法够不着，归 embedding 车道。
  - **双轨接入**：`THREADLOOM_RETRIEVE_SHADOW`（默认开、只写 `diagnostics/retrieve_shadow.jsonl`，让真实游玩自己攒证据）+ `THREADLOOM_RETRIEVE_V2`（默认关，才注入【往事回溯·检索】块）。口径见 `doc/OPERATIONS.md`。
  - **embedding 现状（2026-08-26 本机实测跑通，取代 08-25 的纸面估算）**：网关侧依旧没有——`x.yuzh.de/v1` 只有 5 个 chat 模型，`/v1/embeddings` 对 bge-m3 / text-embedding-3-small / embedding-2 / qwen3-embedding 全部 `model not found`。**本地 ONNX 这条路已实际跑通**：`pip install --target <dir> onnxruntime tokenizers`（`--target` 不受 PEP 668 限制，所以**不需要** `apt install python3.11-venv`——之前记的这个卡点是错的），onnxruntime **1.29.0** + numpy + tokenizers 共 184MB，模型用 int8 的 `Xenova/bge-small-zh-v1.5` 24MB + tokenizer 439KB。实测：会话加载 0.06s、建索引 **3ms/条**（348 条 1.19s，`intra_op=2`）、query **2ms**、**峰值 RSS 156MB**（"只剩 1.5GB 内存"这个约束不成立；真正的紧约束是 **2 线程 CPU**，与 narrator 抢同一个核，所以索引要增量+落盘）。**收益（同 57 条 / 3 档同池）**：纯 embedding MRR 0.825（改写型 0.802 > 词法 0.742，逐字型 0.851 < 词法 0.944——正是该有的分工），**等权 RRF 融合估算 0.845 / recall@3 0.96 / recall@8 0.98 / 漏召 0**，增量集中在改写型（0.742→0.828）。接线注意：等权会把几条词法第一挤到第 3（阿砚旧伤、穿黑衣裳那修士），该像 recency/entity 一样给 <1 的权重。两条词法漏召实测都能碰到：根骨蛹那条 embedding 排第 1；"跑堂的伙计"那条语义 top-1 就是答案，排 13 只因该事实在旧档被逐轮重发 14 份——**先做同文去重比先做 embedding 更划算**。

### State Keeper 三层架构与调度策略

**修改前**：`handler_message.py` 每轮无条件调用 `call_state_keeper()`（fill LLM），对所有字段做全量提取。这导致：
- 每轮都消耗 LLM 配额（~5KB 输入 / 480 tokens 输出）
- keeper 只能看到最近几轮上下文，无法提取跨轮的长期目标
- 主要事件和 `immediate_goal` 精度偏低

**修改后（三层混合策略）**：

| 层                | 模块                | 触发频率           | 输入大小 | 提取字段                              |
| ----              | ----                | ----               | ----     | ----                                  |
| 启发式            | `state_updater.py`  | 离线 replay / rebuild | ~1KB  | 全字段（保守推理）                     |
| Skeleton LLM      | `state_keeper.py`   | 每完整轮           | ~2KB     | time, location, main_event, onstage_npcs, immediate_goal |
| Fill LLM          | `state_keeper.py`   | 每 N 轮（默认 2）  | ~5KB     | carryover_signals, tracked_objects, knowledge_scope |
| Actor Registry    | `actor_registry.py` | 每完整轮           | ~2KB     | actors, actor_context_index, actor-id bindings |

- 读取 `config/runtime.json` 中 `memory.consolidate_every_turns`（当前默认 2）
- 在线非合并轮使用 skeleton + `build_state_from_fragment()` 轻量更新；`state_updater.py` 保留为离线 replay / rebuild 的保守兜底
- opening-choice 首轮当前是特殊链路：会先跑 skeleton + fill keeper，再接 thread/important_npc 写回，不直接复用普通非合并轮的 `update_state()` 路径
- 诊断信息中 `provider` 标注为 `skeleton+fragment` 或 `full_fill`
- 当前字段稳定性大致排序：`time / location / main_event` 高于 `onstage_npcs / immediate_risks / carryover_clues`，而 `immediate_goal` 仍偏保守。

### 上下文窗口与输出优化

**修改前**：
- `recent_history_turns`: 12 轮
- `narrator.max_output_tokens`: 1200
- `lorebookStrategy.maxTotalChars`: 2200（旧 world-sim-balanced 预设）

**修改后**：
- `recent_history_turns`: **12 轮**（`config/runtime.json`）— 保持 recent window 总覆盖范围
- `recent_full_prose_turns`: **6 轮**（`config/runtime.json`）— narrator 只吃最近 6 轮完整正文，更早的同窗口回合用 event outline 桥接
- `narrator.max_output_tokens`: **2000** — 避免长回复在同一位置被 `finish_reason=length` 截断
- `lorebookStrategy.maxTotalChars`: **1500**（当前 active preset）— 减少世界书注入上限

单轮总上下文约从 30KB 降至 22-25KB。

### 角色卡导入管线精度优化

提升 3 个 bootstrap agent 的提取精度上限：

| 参数                                     | 修改前  | 修改后  | 文件                         |
| ----                                     | ----    | ----    | ----                         |
| NPC 注册表发送给 LLM 的数量              | 10 条   | 20 条   | `npc_bootstrap_agent.py`     |
| NPC 别名保留数量                          | 8 个    | 12 个   | `npc_bootstrap_agent.py`     |
| NPC notes 截断长度                        | 80 字符 | 200 字符| `npc_bootstrap_agent.py`     |
| 物件候选发送数量                          | 15 个   | 25 个   | `object_bootstrap_agent.py`  |
| 物件标签最大长度                          | 6 字符  | 8 字符  | `object_bootstrap_agent.py`  |
| 线索候选发送数量                          | 8 个    | 12 个   | `clue_bootstrap_agent.py`    |

另在 `card_importer.py` 中新增 `_truncate()` 辅助函数，当字段被截断时自动输出 WARNING 日志，便于排查导入精度问题。

### 角色卡导入审查与修复（v1.0 前历史记录）

详见 `doc/archive/history/CARD-IMPORT-AUDIT.md`。本次修复主要解决三类问题：

1. **数据丢失**：`system_npcs.items` 漏放 `roster`、SillyTavern v2/v3 大量字段未读、
   `personality` 截到 240 字符。
2. **误伤**：`'小美'`/`'血蚀纪'` 等具体作品人名被写死成黑名单、faction 推断硬编码、
   主角名长度限制把英文名全拒绝。
3. **覆盖面**：`_extract_embedded_npcs` 只识别中文条目，英文卡的内嵌 NPC 兜底由新加的
   `_extract_embedded_npcs_latin` 处理。

修复点对应单测 `tests/test_card_importer.py`（21 个）+ 端到端测试
`tests/test_card_importer_e2e.py`（3 个）。

### 前端 UI 重构

- **设置面板** 重组为三页签：连接与模型 / 角色卡 / 用户设定；未激活页签使用绿色背景
- **侧边栏合并至浮动面板**：原 `stateColumn` 侧边栏的 4 个分区（当前状态、NPC、物件与线程、NPC 详情）已移入调试浮动面板，并新增"调试诊断"折叠区；移除了侧边栏按钮
- **Session Dock 简化**：会话归档功能已取消，Dock 只显示当前可用会话；开始新游戏不再移动旧 session，也不再展示归档分隔线
- **角色卡缩略图缓存**：移除了 `?t=${Date.now()}` cache-buster，启用浏览器缓存和 `loading="lazy"`
- **角色卡切换**：添加了 error handling 和自动关闭设置面板

### 角色卡导入修复（v1.0 前历史记录）

- **嵌套 JSON 世界书展开**：部分 Tavern 卡会把真正的世界书写在外层条目的
  `content` JSON-like blob 的 `entries[]` 里，且字符串内含未转义换行。导入器现在会宽松解析这类结构，展开为正常 `lorebook.json` 条目，并标注 `source_kind: embedded_lorebook_json`。
- **嵌套条目分类**：内层 `时间线 / 阵营 / location / Dynamic Rules / 动态规则 / 异能 / 晶核` 会按标题精确分类为 `history / faction / region / rule`，避免被外层标题或正文关键词误导。
- **runtime 噪声过滤**：`enabled: false` 或 `disable: true` 的世界书条目不再进入 runtime `lorebook.json`；`初始引导` 等玩家设定提示也会从 runtime 世界书中过滤。
- **显式 NPC 保留**：`npc：...` / `Npc-...` 这类显式 NPC 条目即使正文包含 `{{user}}`，也不会被误判为模板并跳过。
- **管理卡片短简介**：导入器会生成 `displaySummary`，角色卡管理优先展示这份清洗后的短简介，避免把作者指令、人际模板、状态栏、YAML 人物细节直接显示在卡片下方。
- **测试覆盖**：`tests/test_card_importer.py` 已补充嵌套世界书、disabled 条目过滤、显式 NPC 模板占位符、管理卡片短简介等回归测试；当前导入器相关测试为 `36 passed`。

### 前端交互修复（v1.0 前历史记录）

- 顶部 header 改为左上角浮动胶囊，只保留 logo / `Threadloom` / 当前用户与角色卡，窄屏与移动端隐藏，减少对正文区域的占用。
- 设置面板重组为 `当前世界 / 导入资产 / 玩家设定 / 模型连接`：当前世界内直接列出角色卡管理、Session 管理和聊天记录导入；导入资产只处理角色卡导入。
- 胶囊内 `Threadloom` 打开模型连接；当前用户/世界区域打开当前世界页签。窄屏与移动端隐藏胶囊。
- Session 管理弹层已移出 composer 表单，新增关闭按钮，并修复点击快捷入口后被全局点击监听立刻关闭的问题；当前世界页签也内嵌会话列表，可直接切换、删除或新建会话。

### 世界书蒸馏回归（v1.0 前历史记录）

- `state_keeper_candidate` 已收敛为继承 State Keeper 模型，不再使用 hidden advanced 模型覆盖。
- 四张当前角色卡均已重建 `lorebook-foundation.json` / `lorebook-index.json`，产物 `provider: llm`。
- HTTP 3 轮回归从 `开始游戏` 开局验证通过：开局与后续 3 个正文回合均正常返回。
- narrator prompt 注入审查结论：每轮均注入 `【世界书基础规则】`，普通正文轮情境世界书限制在约 2 条 / 700 字；旧 raw `【世界书】` 块不再出现。
- turn trace 已补充 opening-choice 分支的 `prompt_block_stats` 与 `lorebook_injection`，便于直接审查每轮注入结构。
