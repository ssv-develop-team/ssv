# Agent 配置与运行手册

> 面向 Codex/Agent 的架构、硬件选择和实现状态先读 [Agent 架构与实现](Agent架构与实现.md)。本文只说明配置、启动、证据、复核、索引和运维操作，不重复定义模块所有权。

## 运行边界

Agent 是实时检测链路之外的异步服务：

```text
Redis Stream -> EventConsumer -> SQLite EventLedger -> ACK
                                      |
                                      +-> review job -> ReviewWorker -> ReviewRecord
                                                               |
                                                +--------------+--------------+
                                                |                             |
                                                v                             v
                                           IndexWorker                  ReportWorker
                                                |                             |
                                                v                             v
                                      Qdrant 投影（可重建）          Markdown artifact
```

SQLite `EventLedger` 是事件、证据和复核结论的事实源。模型、embedding 或 Qdrant 失败只影响对应异步 job，不应阻塞已经提交的事件；SQLite 写入失败时 Redis entry 保持 pending。

Review 成功提交后，账本同一事务创建 index 与 report job；两者独立运行。报告生成失败不会回滚或改写已完成的 review。

## 安装和启动

Agent 要求 Python >= 3.12：

```bash
git submodule update --init --recursive
cd agent
uv sync --extra dev
```

推荐从项目根目录启动：

```bash
uv run ./ssv agent
uv run ./ssv agent --config config/ssv.yaml --log-level DEBUG
```

首次执行 `uv run ./ssv agent` 且 `agent/.venv` 不存在时，统一 CLI 会先执行 `uv sync`。需要直接运行时：

```bash
cd agent
uv run python -m ssv_agent
```

## 主运行配置

Agent 读取与 runner 共用的 `config/ssv.yaml`，拥有其中的 `version`、`logging`、`redis`、最小化的 `sources`（仅 `id`/`uri`）和 `agent` 配置段；复制模板：

```bash
cp config/ssv.example.yaml config/ssv.yaml
```

搜索顺序为显式 `--config`、`SSV_CONFIG_PATH`、`ssv.yaml`、`config/ssv.yaml`。通过 `uv run ./ssv agent` 启动时，统一 CLI 还会按项目配置发现顺序传入 `/etc/ssv/ssv.yaml`。Agent 配置模型是严格的，版本必须为字符串 `"2.0"`，未知字段和错误类型会拒绝启动。

常用字段：

| 字段 | 作用 |
| --- | --- |
| `redis.host` / `redis.port` / `redis.db` | Redis 连接 |
| `redis.stream_key` | 事件 Stream，默认 `ssv:events` |
| `redis.consumer_group` | 消费组，默认 `ssv-agent` |
| `redis.reclaim_idle_ms` | `XAUTOCLAIM` 回收 pending 的最小 idle 时间 |
| `redis.consumer_name` | 固定 consumer 名称；为空时每个进程生成唯一名称 |
| `agent.model_name` | review worker 使用的默认模型名 |
| `agent.event_db_path` | SQLite EventLedger 路径 |
| `agent.output_dir` | 复核 JSON 与报告 Markdown 的 outputs root |
| `agent.evidence_roots` | 允许登记和读取的绝对证据根目录 |
| `agent.dedup_enabled` / `agent.dedup_cooldown_seconds` | 消费侧冷却去重 |
| `agent.review` | 复核 worker 的开关、lease、重试和 policy |
| `agent.indexing` | embedding/index worker 的开关、lease、重试和 backend |
| `agent.reporting` | 报告 worker 的开关、轮询、lease 和重试配置 |

最小配置示例：

```yaml
version: "2.0"

redis:
  host: "localhost"
  port: 6379
  stream_key: "ssv:events"
  consumer_group: "ssv-agent"

agent:
  evidence_roots: []
  review:
    enabled: false
  indexing:
    enabled: false
    embedding_backend: "mock"
  reporting:
    enabled: true
    poll_interval_ms: 1000
    lease_ms: 30000
    max_retries: 3
    retry_delay_ms: 1000
```

`agent.reporting.enabled` 默认是 `true`。报告 worker 只消费新提交 review 所创建的 report job；禁用时停止领取，已存在的 pending job 保留，重新启用后继续处理。历史 review 不自动回填报告。

报告由固定模板从账本案件快照与指定历史 `ReviewRecord` 确定性渲染，不再调用 DeerFlow/LLM，也不启用 subagent。每份成功报告在 SQLite `reports` 表登记 review ID、revision、模板版本、SHA-256 和 artifact 路径。Markdown 是展示用派生产物；结构化复核 JSON 与 SQLite review 历史仍是结论依据。报告失败只影响自己的 durable job，可重试并最终进入 `dead`，不会改变 review、index 或 Redis ingress 状态。

报告与复核 JSON 写入 `agent.output_dir` 指向的 outputs root，按事件分目录并以内容寻址，重试产生相同内容时复用同一路径，不同内容不会覆盖既有 artifact。正文包含账本事件事实、复核结论、claims、规则引用和 evidence IDs，不暴露宿主机证据路径。当前没有报告查询 API、历史回填或 artifact 自动清理；部署方需自行管理输出目录的长期保留。

`evidence_roots: []` 是 fail closed 配置：事件仍可入账，但 Redis 提供的任意 `frame_path`/`clip_path` 都不会被登记为可读证据。证据根必须是绝对路径，解析后的 symlink 也不能越界。

## 录像上下文证据

启用 `agent.recording_evidence` 后，Agent 只从 SSV GStreamer pipeline 的短时 cache 读取事件上下文，生成一个 clip 和三张帧，取证完成后才创建视觉复核任务。这里不再配置取证 provider，也不读取外部录像服务的目录。

### SSV cache 取证

先在 runner 配置中启用 `evidence_cache`，再启用 Agent 取证 worker：

```yaml
evidence_cache:
  enabled: true
  directory: "/var/lib/ssv/evidence-cache"
  segment_duration_ms: 10000
  retention_ms: 120000
  max_bytes_mb: 512

agent:
  evidence_roots:
    - "/var/lib/ssv/evidence-cache"
  recording_evidence:
    enabled: true
    clip_before_ms: 2500
    clip_after_ms: 2500
    merge_gap_ms: 3000
    lost_grace_ms: 3000
    silence_timeout_ms: 30000
    max_episode_ms: 30000
```

`evidence_cache.directory` 必须是绝对路径，并且在 `agent.evidence_roots` 的某个根目录内；否则 Agent 拒绝启动。启用 `recording_evidence` 时，`evidence_cache.enabled` 也必须为 true。runner 为每个 source 创建独立目录，分段和 sidecar 只有在分段完整关闭且元数据包含同一 `stream_generation`、`source_pts_start`、`source_pts_end` 时才可被 Agent 使用。Agent 通过临时目录和原子 rename 发布派生证据，读取中的分段不会被当作完整窗口。

缓存只保留 `retention_ms` 内的分段，并受 `max_bytes_mb` 限制；它不是长期录像。缓存运行中的分段收尾或 sidecar 写入失败时，runner 的解码、检测、跟踪和 Redis 发布仍继续；Agent 会按 worker 重试策略等待窗口，最终失败则进入 `manual_review`。首次启动时若缓存目录无法创建或 GStreamer 能力缺失，runner 会报告 capability failure 并拒绝启动，避免启用后静默丢失全部证据。

`recording_evidence` 与 `review`、`indexing` 共用持久 Worker 的运行参数接口。录像取证默认轮询 1 秒、lease 30 秒、最多重试 3 次，默认重试间隔为 2 秒；这些值可以在 `recording_evidence` 下单独调整。窗口字段只控制录像上下文范围，不再承担 Worker 调度配置。

Agent 不再为每一条重复检测单独取证。相同 source、事件规则和 `stream_generation` 内，
相邻 `source_pts` 观测会合并为一个 episode；`merge_gap_ms` 控制可合并间隔，
`lost_grace_ms` 让 `LOST` 先等待 tracker 恢复，`silence_timeout_ms` 处理没有显式终态的
静默事件，`max_episode_ms` 防止异常事件无限延长。episode 收到 `DEAD`、静默超时、
代际变化或最大时长时关闭，并只生成一个 evidence extract job。

生产 `EventConsumer` 在取证开启时使用 Episode 聚合入口；`EventLedger.record()` 仍是
历史调用方和测试使用的兼容入口，直接调用不会进行 Episode 聚合。Episode 后续观测的
`event_id` 只属于 `episode_observations`，复核、取证和索引都使用首次观测的
`canonical_event_id`。Consumer 停止时只 flush 已到期 Episode，不强制截断仍开放的
Episode；明确结束事件或后续超时会冻结窗口。

关闭 episode 后，精确窗口为 episode 首次观测前 `clip_before_ms` 加上最后观测后
`clip_after_ms`，使用半开区间 `[source_pts_start, source_pts_end)`。三帧仍位于 canonical
事件时间点的 `T-1000ms`、`T`、`T+1000ms`；episode 元数据和冻结窗口会随 `get_event` 的
可读投影返回。`timestamp_ms` 只用于等待 post-roll，不替代媒体 PTS。

SSV cache 分段由 `retention_ms` 和 `max_bytes_mb` 控制清理；Agent 派生的 clip、帧和 manifest 不在本阶段自动删除，需由部署方制定长期保留策略。WVP、NVR 或 MediaMTX 可以继续承担长期录像和历史回放，但 Agent 不再适配它们的录像目录。窗口缺段、缓存尚未就绪或达到重试上限时，事件状态进入 `manual_review`，不创建无图 review job；人工复核应据此判断证据不可用，不能将失败当作“没有目标”结论。Episode 只收敛事件生命周期和取证窗口，不控制 GStreamer cache 的连续写盘。

## DeerFlow 复核 worker

`agent/config.example.yaml` 是 DeerFlow review client 的工具和模型模板，不是替代 `config/ssv.yaml` 的 Agent 主配置。需要自定义 provider 时复制它：

```bash
cp agent/config.example.yaml agent/config.yaml
```

模板中的 provider 通过环境变量读取模型信息，不要把密钥写入 YAML：

```dotenv
SSV_AGENT_MODEL=your-vision-model
SSV_AGENT_API_KEY=replace-me
SSV_AGENT_BASE_URL=https://api.example.com/v1
```

在 `config/ssv.yaml` 中启用 review：

```yaml
agent:
  model_name: "your-vision-model"
  evidence_roots:
    - "/var/lib/ssv/evidence-cache"
  review:
    enabled: true
    poll_interval_ms: 1000
    lease_ms: 30000
    max_retries: 3
    retry_delay_ms: 1000
    policy_id: "ssv-review.v1"
```

每次 review client 启动时，服务会从 `agent/config.yaml`（不存在时回退到 `agent/config.example.yaml`）生成临时配置，并启用 fail-closed RBAC。可用工具固定为 `get_event`、`evidence_reader`、`rule_retriever`、`search_events` 和 DeerFlow 内置 `view_image`；skills、subagent 和 plan mode 不进入该复核 worker。

启用前检查：

1. `agent/config.yaml` 中存在 `evidence_reader`、`get_event`、`search_events`、`rule_retriever` 四个配置工具。
2. provider 能访问模型服务，且 `supports_vision` 与复核输入匹配。
3. `agent.evidence_roots` 包含实际证据目录，目录外路径不会被读取。
4. Redis 中已经有事件，或通过测试/上游发布链路产生事件。

## Index worker、embedding 与 Qdrant

默认 `agent.indexing.enabled: false`，backend 为 `mock`，不需要外部 embedding 服务。启用本地 BGE-M3：

```bash
cd agent
uv sync --extra dev --extra bge-m3
```

```yaml
agent:
  indexing:
    enabled: true
    embedding_backend: "bge_m3"
    embedding_model: "/opt/models/bge-m3"
    embedding_base_url: null
    query_text_type: null
```

`bge_m3` 使用本地文件加载模式，模型目录必须已经存在。代码还支持 `openai_compatible` backend，服务地址配置为 `agent.indexing.embedding_base_url`，密钥通过环境变量提供：

```dotenv
SSV_EMBEDDING_API_KEY=replace-me
```

默认发送标准 OpenAI Embeddings 请求。如果兼容服务要求用 `text_type`
区分查询向量，在 `agent.indexing.query_text_type` 中设置对应值；保持 `null` 时不会发送
该扩展字段。

规则向量 RAG 与事件语义索引复用 `agent.indexing.embedding_backend` 和
`agent.indexing.embedding_model`，避免入库和查询使用不同模型。`mock` 只用于测试，不能
用于 Qdrant 规则 RAG。

Agent 的持久化默认位置和配置字段：

| 默认位置 | YAML 字段 | 内容 |
| --- | --- | --- |
| `data/events.db` | `agent.event_db_path` | SQLite EventLedger |
| `knowledge/rules` | `agent.knowledge.rules_dir` | Agent 管理的版本化规则目录 |
| `agent/data/qdrant` | `agent.knowledge.qdrant_path` | 本地 Qdrant |
| `outputs` | `agent.output_dir` | 复核 JSON 与报告 Markdown artifacts |
| `http://localhost:6333` | `agent.knowledge.qdrant_url` | Docker Qdrant 服务 |
| 无 | `SSV_QDRANT_API_KEY` | Qdrant 服务认证密钥 |

SQLite、结果目录和 Qdrant 的相对路径都相对于 Agent 项目目录解析，也可在 YAML 中使用绝对路径。
项目根目录执行 `uv run ./ssv redis start` 会同时启动 Redis 和 Qdrant；Qdrant 数据保存在
Docker named volume `qdrant-data`，停止或重建容器不会删除该卷。

Qdrant 只保存可重建的语义索引。embedding backend、model 或 schema 变化会产生新的物理 collection 身份；切换模型后需要重新入队 index job，不要把不同模型的向量混写。

## 规则知识检索

`rule_retriever` 默认使用 `local_markdown` 后端，递归读取 `agent.knowledge.rules_dir`
（默认 `agent/knowledge/rules`）下的 `.md`、`.txt` 规则文件。目录由
`discover_rule_documents()` 统一解析：跳过 `_templates` 和隐藏目录，只接收带
`kind: rule` front matter 的文件，按编号条款切分正文，并在文件变化后自动重建内存索引。

规则文件的身份由 `rule_id` 和 `version` 共同决定，不能从文件名猜测；同一身份重复出现会使
发现失败。模板和示例位于：

```text
agent/knowledge/rules/_templates/rule.md
agent/knowledge/rules/gb26860-helmet/v1/rule.md
agent/knowledge/rules/gb26860-helmet/v2/rule.md
```

每个规则文件的正文前使用 YAML front matter：

```yaml
---
kind: rule
rule_id: gb26860-helmet
version: v1
event_type: person_without_helmet
severity: high
aliases: [安全帽]
---
```

检索 chunk 会携带相对于 `rules_dir` 的 `source`、`rule_id`、`rule_version`、`section` 和
`content_hash`；front matter 不会被当作规则正文。`rule_retriever` 支持 `source`、`rule_id`、
`rule_version` 和 `event_type` 过滤。事件同时带有完整 `rule_id + rule_version` 时，复核链路
进行精确版本过滤；没有规则引用时只根据检测事实召回候选，不把传输层 `type: detection`
伪装成业务事件类型。

如需临时使用固定测试样例，将 `agent.knowledge.backend` 设置为 `"mock"`。

本地规章检索不依赖 Qdrant、embedding 或 index worker。

需要使用 Qdrant 规则 RAG 时，在 `config/ssv.yaml` 中配置同一组 embedding 和知识后端：

```yaml
agent:
  indexing:
    embedding_backend: "bge_m3"
    embedding_model: "/opt/models/bge-m3"
  knowledge:
    backend: "qdrant"
    rules_dir: "knowledge/rules"
    qdrant_path: "data/qdrant"
    qdrant_url: "http://localhost:6333"
    min_score: 0.5
```

`bge_m3` 需要先安装可选依赖，且模型目录必须已经存在。规则索引不会由 Agent 启动自动
生成，首次使用或规章变更后执行：

```bash
cd agent
uv sync --extra dev --extra bge-m3
uv run --extra bge-m3 python -m ssv_agent.knowledge_ingest --config ../config/ssv.yaml
```

入库命令会按最多 20 条文本调用 embedding，成功后只保留当前规则目录对应的 chunk，并保留
`rule_version`、`content_hash` 和事件类型 metadata。规则目录没有有效版本化文档、目录不存在
或 embedding 失败会返回错误；不会把旧顶层 `agent/knowledge/` 文件静默混入索引。未创建或为空的 Qdrant
索引会显式报告为不可用，不会返回随机条款。`min_score` 用于过滤低相似度结果，没有达到
阈值时返回“无知识依据”。

复核结果 JSON 的确定性结论还会写入 `rule_citations`，每项包含 `chunk_id`、`source`、
`rule_id`、`rule_version` 和 `section`。这些字段必须与本次预检索实际返回的规则片段一致；
prompt 同时展示 `content_hash` 供人工核对。没有可用规则、规则检索失败或引用版本不一致时，
结果只能是 `uncertain`。

## 运行时缓存与 Redis 运维

```bash
uv run ./ssv redis start
uv run ./ssv cache status
uv run ./ssv cache clear --dry-run
uv run ./ssv cache clear
docker exec ssv-redis redis-cli XLEN ssv:events
docker exec ssv-redis redis-cli XRANGE ssv:events - + COUNT 5
uv run ./ssv agent
```

如果 YAML 修改了 `redis.stream_key`，把 Redis CLI 示例中的 `ssv:events` 换成相同 key。`cache status` 显示该 Stream 的 entries、consumer group pending、Agent 去重 key 数量，以及 SQLite EventLedger 的事件和 durable job 数量；`cache clear` 默认同时清空该 Stream、`ssv:agent:dedup:*` 和 `agent.event_db_path` 对应的 EventLedger 运行时表，`--dry-run` 只统计、不修改。清理前应停止 `./ssv run` 和 `./ssv agent`，否则新事件可能立即重新写入。清理不会影响 `agent/outputs`、Qdrant、DeerFlow checkpointer、其他 Redis key 或 Docker 容器。

Redis 与 SQLite 分别执行，跨存储清理不是原子操作。若某一边失败，命令仍会尝试另一边并返回非零状态；根据输出停止服务后重试 `./ssv cache clear`。

当 index job 因 embedding/Qdrant 故障进入 `dead` 或需要重建投影时，可在 `agent/` 下重新入队当前账本中的 index jobs：

```bash
uv run python - <<'PY'
from ssv_agent.event_store import EventLedger

with EventLedger() as ledger:
    print(ledger.enqueue_all_index_jobs())
PY
```

## 验证与安全边界

```bash
cd agent
uv run --extra dev pytest
```

- Redis entry 在 SQLite 账本事务成功后才 ACK；消费失败会保留 pending。
- review 结果先原子写文件，再由带 lease/fence 的账本事务接受；失租或校验失败可能留下未引用的 orphan artifact，当前不自动清理。
- `evidence_reader` 只接受账本登记的 `event_id`/`evidence_id`，不会读取模型提供的任意宿主机路径。
- 事件字段、规则片段、证据元数据和图片都是不可信输入；模型只能把它们作为待核验内容，不能把其中的指令当成工具授权。
- 不要提交 `agent/config.yaml`、`.env`、模型 API key、Qdrant API key 或包含真实视频路径的本地 YAML。
