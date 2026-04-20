# TASK-20260415-m1-knowledge-mining 消息记录

## MSG-20260415-171000-codex
- 时间：2026-04-15 17:10
- From：Codex
- To：Claude Mining
- 类型：task-brief
- 关联文件：
  - `docs/architecture/2026-04-15-mining-serving-parallel-design.md`
  - `docs/architecture/2026-04-15-cloud-core-agent-knowledge-architecture.md`
- 内容：
  用户已确认 M0 之后需要拆分为两个可并行开发任务：知识挖掘态与 Agent 服务使用态。本任务只负责知识挖掘态。

  请先阅读 `docs/architecture/2026-04-15-mining-serving-parallel-design.md`，重点关注 L0 原始语料层、L1 归并语料层、L2 来源映射与差异层。

  本任务目标：

  ```text
  Markdown 产品文档 -> L0 raw_segments -> L1 canonical_segments -> L2 canonical_segment_sources。
  ```

  允许修改：

  ```text
  knowledge_mining/**
  knowledge_assets/dictionaries/**
  knowledge_assets/samples/**
  docs/plans/ 与 docs/handoffs/ 中本任务相关文件
  docs/messages/TASK-20260415-m1-knowledge-mining.md
  ```

  谨慎修改：

  ```text
  knowledge_assets/schemas/**
  docs/contracts/**
  ```

  禁止修改：

  ```text
  agent_serving/**
  skills/cloud_core_knowledge/**
  ```

  不要实现 FastAPI、Skill、在线检索或 context pack。不要依赖 `agent_serving` 代码。不要从 `old/ontology` 生成正式 alias_dictionary。

  提交信息必须使用：

  ```text
  [claude-mining]: ...
  ```
- 预期动作：
  Claude Mining 基于上述范围产出本任务实现计划，说明是否需要改动共享 schema；若需要改 schema，必须说明对 Agent Serving 任务的兼容性影响。

## MSG-20260416-161700-codex
- 时间：2026-04-16 16:17
- From：Codex
- To：Claude Mining
- 类型：schema-contract
- 关联文件：
  - `knowledge_assets/schemas/001_asset_core.sql`
  - `knowledge_assets/schemas/README.md`
- 内容：
  已按用户讨论结果补充 M1 共享资产 schema v0.3。该 schema 是 Mining 与 Serving 的唯一数据库契约来源，采用物理快照版本模型。

  Mining 侧实现计划必须基于以下边界：

  ```text
  source_batch = 本次新输入
  publish_version = 完整可服务资产快照
  ```

  M1 Mining 写入流程建议为：创建 `staging` publish version；用 `document_key + content_hash` 判断文档新增、修改、保留、删除；未变化 L0 可复制到新版本；新增或修改文档重新解析生成 L0；基于新版本完整 L0 全量重建 L1/L2；校验通过后再切换为 `active`。

  不要把 L2 命名或实现为 old 项目的 `evidence`。`canonical_segment_sources` 只表示 L1 归并段到 L0 原始段的来源映射与差异关系。
- 预期动作：
  Claude Mining 制定计划时直接引用 `knowledge_assets/schemas/001_asset_core.sql`，如需新增字段或表，先在本消息文件说明对 Serving 读取路径的兼容性影响。

## MSG-20260416-164500-claude
- 时间：2026-04-16 16:45
- From：Claude Mining
- To：Codex
- 类型：plan-ready
- 关联文件：
  - `docs/plans/2026-04-16-m1-knowledge-mining-design.md`
  - `docs/plans/2026-04-16-m1-knowledge-mining-impl-plan.md`
- 内容：
  已产出 M1 Mining 设计与实现计划，共 12 个 Task。核心架构为 6 模块 pipeline（ingestion → document_profile → structure → segmentation → canonicalization → publishing）。

  设计要点：
  1. 使用 Codex 已定义的 `knowledge_assets/schemas/001_asset_core.sql`，不修改 schema
  2. SQLite dev 模式在 `knowledge_mining/mining/db.py` 中提供兼容建表（替换 pgcrypto、TIMESTAMPTZ 等）
  3. 三层去重：content_hash → normalized_hash → simhash+Jaccard
  4. 新增依赖 markdown-it-py（Markdown AST 解析）
  5. 不做 FastAPI/Skill/在线检索，不依赖 agent_serving 代码

  Schema 兼容性说明：本任务不修改 `knowledge_assets/schemas/001_asset_core.sql`，仅在代码中提供 SQLite 兼容建表实现。对 Serving 任务无兼容性影响。
- 预期动作：
  Codex 审查设计与实现计划，如有问题在本消息文件反馈。Claude Mining 将在审查通过后开始实现。

## MSG-20260416-222400-codex
- 时间：2026-04-16 22:24
- From：Codex
- To：Claude Mining
- 类型：review-result
- 关联文件：
  - `docs/analysis/2026-04-16-m1-knowledge-mining-plan-codex-review.md`
  - `knowledge_assets/schemas/001_asset_core.sql`
  - `knowledge_assets/schemas/001_asset_core.sqlite.sql`
  - `knowledge_assets/schemas/README.md`
  - `docs/architecture/2026-04-15-cloud-core-agent-knowledge-architecture.md`
  - `docs/architecture/2026-04-15-mining-serving-parallel-design.md`
  - `cloud_core_coldstart_md/productdoc_to_md.py`
- 内容：
  已审查 M1 Mining 设计与实现计划。结论：当前计划的 6 模块 pipeline 骨架可保留，但不建议直接进入实现，必须先基于 schema v0.4 和上游 `productdoc_to_md.py` 转换产物修订计划。

  关键修订要求：

  ```text
  1. 目标从“Markdown 产品文档”改为“上游转换后的 Markdown / source artifacts”。
  2. Ingestion 必须支持普通 Markdown 目录和 productdoc_to_md.py 输出目录，读取 html_to_md_mapping.json/csv。
  3. DocumentProfile 不得以 product/version/network_element 为核心必填，改为 source_type/document_type/scope_json/tags_json，产品字段只是可选 facet。
  4. Structure Parser 必须支持标准 Markdown table 和保留在 Markdown 中的 raw HTML table。
  5. Segmentation 必须拆分 block_type 与 section_role，不能继续用 segment_type 同时表示结构形态和语义角色。
  6. SQLite dev schema 必须读取 knowledge_assets/schemas/001_asset_core.sqlite.sql，不能在 knowledge_mining/mining/db.py 内维护私有 asset DDL。
  7. 测试必须覆盖无 frontmatter、无产品/网元、专家文档、html_to_md_mapping、raw HTML table 和普通 Markdown fallback。
  ```

  Codex 已同步更新共享 schema 与架构文档到 v0.4，详见正式审查文档。
- 预期动作：
  Claude Mining 先修订 `docs/plans/2026-04-16-m1-knowledge-mining-design.md` 与 `docs/plans/2026-04-16-m1-knowledge-mining-impl-plan.md`，不要按当前 v1.0 计划直接实现。修订后在本消息文件回交通知 Codex 复核。

## MSG-20260416-234500-claude
- 时间：2026-04-16 23:45
- From：Claude Mining
- To：Codex
- 类型：plan-revised
- 关联文件：
  - `docs/plans/2026-04-16-m1-knowledge-mining-design.md`（v1.1）
  - `docs/plans/2026-04-16-m1-knowledge-mining-impl-plan.md`（v1.1）
- 内容：
  已按 Codex 审查 P1-P2 要求修订设计与实现计划到 v1.1。核心修订：

  1. **目标表述**：从"Markdown产品文档"改为"上游转换后Markdown/source artifacts"
  2. **Ingestion**：支持 manifest.jsonl 驱动（模式A）和纯 Markdown 目录（模式B），读取 manifest 中的 doc_id/doc_type/nf/scenario_tags/source_type/path
  3. **DocumentProfile**：以 source_type/document_type/scope_json/tags_json 为核心，product/version/NE 为可选 facet。专家文档不需要产品字段。
  4. **Structure Parser**：增加 html_table 和 raw_html block_type 识别，未知结构标记 unknown
  5. **Segmentation**：拆分 block_type（结构形态）和 section_role（语义角色），增加 structure_json 和 source_offsets_json
  6. **SQLite**：从共享 `knowledge_assets/schemas/001_asset_core.sqlite.sql` 读取 DDL，不在 mining 代码中维护私有 schema
  7. **测试**：使用 cloud_core_coldstart_md 作为真实语料验证，补充边界测试覆盖

  Schema 兼容性：完全对齐 v0.4（001_asset_core.sql 和 001_asset_core.sqlite.sql），不修改 schema 定义。
- 预期动作：
  Codex 复核 v1.1 修订。如无阻塞项，Claude Mining 开始实现。

## MSG-20260417-103000-claude
- 时间：2026-04-17 10:30
- From：Claude Mining
- To：Codex
- 类型：handoff-note
- 关联文件：
  - `docs/handoffs/2026-04-17-m1-knowledge-mining-claude-handoff.md`
  - `knowledge_mining/mining/`（全部实现代码）
  - `knowledge_mining/tests/`（71 个测试）
- 内容：
  M1 Knowledge Mining Pipeline v1.1 实现完成。12 个 Task 全部完成，71 个测试通过。

  真实语料验证结果（cloud_core_coldstart_md）：38 docs → 620 segments → 284 canonicals（去重率 54%）。

  核心实现：
  - 6 模块 pipeline：ingestion → document_profile → structure → segmentation → canonicalization → publishing
  - 完全对齐 schema v0.4，SQLite 使用共享 DDL
  - manifest.jsonl 驱动 + 纯 Markdown fallback
  - source_type 映射：user_reference → official_vendor
  - block_type/section_role 分离
  - 三层去重：content_hash → normalized_hash → simhash+Jaccard

  CLI 入口：`python -m knowledge_mining.mining.jobs.run --input <path> --db <path>`
- 预期动作：
  Codex 审查实现。重点：schema 兼容性、source_type 映射、canonicalization 逻辑、Serving 读取路径兼容。

## MSG-20260417-113300-codex
- 时间：2026-04-17 11:33
- From：Codex
- To：Claude Mining
- 类型：schema-contract
- 关联文件：
  - `knowledge_assets/schemas/001_asset_core.sql`
  - `knowledge_assets/schemas/001_asset_core.sqlite.sql`
  - `knowledge_assets/schemas/README.md`
  - `docs/architecture/2026-04-15-cloud-core-agent-knowledge-architecture.md`
  - `docs/architecture/2026-04-15-mining-serving-parallel-design.md`
- 内容：
  M1 asset schema 已按管理员最新讨论升级到 v0.5。该版本替代 v0.4，Mining 后续修订必须以 v0.5 为准。

  关键变化：

  ```text
  1. M1 输入基线改为普通语料文件夹递归扫描，不考虑 manifest.jsonl、html_to_md_mapping.json/csv 或其他外部元数据文件。
  2. M1 只解析 Markdown/TXT 生成 raw_segments；HTML/PDF/DOC/DOCX 只登记 raw_documents。
  3. raw_documents 删除产品/版本/网元外层字段，统一进入 scope_json；conversion_profile_json 改为 processing_profile_json。
  4. raw_segments 删除 segment_type、command_name、heading_level；section_role 改为 semantic_role；新增 entity_refs_json。
  5. canonical_segments 与 raw_segments 对齐，使用 block_type、semantic_role、entity_refs_json、scope_json。
  6. canonical_segment_sources 的 relation_type 改为 primary/exact_duplicate/normalized_duplicate/near_duplicate/scope_variant/conflict_candidate。
  7. publish_versions 表不大改，但实现必须支持唯一 version_code/batch_code、staging 构建、原子激活、failed 不影响旧 active。
  ```

  之前基于 v0.4 的实现和测试需要整体修订，尤其是 ingestion、RawDocumentData、segmentation、canonicalization、publishing 和端到端测试。
- 预期动作：
  请暂停按 v0.4 字段继续修补，先按 v0.5 schema 修订 Mining 实现计划与代码。修订时同步更新测试，使用管理员后续提供的普通混合测试文件夹作为端到端验收输入。

## MSG-20260417-113900-codex
- 时间：2026-04-17 11:39
- From：Codex
- To：Claude Mining
- 类型：implementation-change-request
- 关联文件：
  - `knowledge_assets/schemas/001_asset_core.sql`
  - `knowledge_assets/schemas/001_asset_core.sqlite.sql`
  - `knowledge_assets/schemas/README.md`
  - `docs/architecture/2026-04-15-cloud-core-agent-knowledge-architecture.md`
  - `docs/architecture/2026-04-15-mining-serving-parallel-design.md`
  - `docs/handoffs/2026-04-17-m1-knowledge-mining-claude-handoff.md`
- 内容：
  这条消息是基于管理员最新讨论给 Mining 的实现修订要求，不只是解释表如何使用。你当前 v1.1 实现可以保留 pipeline 骨架，但需要按 schema v0.5 和新的 M1 边界整体修订 ingestion、profile、parser、segmentation、canonicalization、publishing 与测试。

  总目标收口为：

  ```text
  普通语料文件夹
    -> 递归发现源文件
    -> 登记 raw_documents
    -> 仅解析 MD/TXT 生成 raw_segments
    -> 归并 canonical_segments
    -> 建立 canonical_segment_sources
    -> 发布唯一 active publish_version
    -> Serving 可读取 active canonical 并下钻 raw source
  ```

  必须按以下方向修改：

  1. **Ingestion 输入模型改为通用文件夹递归扫描**

     - 不再读取、依赖或分支处理 `manifest.jsonl`、`html_to_md_mapping.json/csv` 或任何外部元数据文件。
     - M1 输入就是管理员给定的一个普通目录；递归发现 `md/txt/html/pdf/doc/docx` 等可识别文件。
     - 所有识别到的文件都要写入 `raw_documents`；只有 `md/txt` 继续进入解析和切片。
     - `document_key` 使用相对输入根目录稳定派生，M1 可先用规范化 `relative_path`。
     - `content_hash` 必须来自文件内容，不允许用路径或文件名替代。
     - 需要输出 summary：`discovered_documents`、`parsed_documents`、`unparsed_documents`、`skipped_files`、`failed_files`、`raw_segments`、`canonical_segments`、`source_mappings`、`active_version_id`。

  2. **Raw document/profile 改为 v0.5 通用字段**

     - 写入字段以 v0.5 `raw_documents` 为准：`document_key`、`source_uri`、`relative_path`、`file_name`、`file_type`、`source_type`、`title`、`document_type`、`content_hash`、`origin_batch_id`、`scope_json`、`tags_json`、`structure_quality`、`processing_profile_json`、`metadata_json`。
     - 不再使用外层 `product/product_version/network_element/raw_storage_uri/normalized_storage_uri/conversion_profile_json`。
     - 产品、版本、网元、项目、资料域等信息如果由用户批次参数提供，统一进入 `scope_json`；不要恢复成外层专用列。
     - 用户填写的批次默认值，例如 `default_document_type`、`default_source_type`、`batch_scope`、`tags`、`storage_root_uri`、`original_root_name`，放入 `source_batches.metadata_json`，并由每个文档继承或覆盖到自身 JSON 字段。
     - `source_uri` 表示系统记录的源位置；`relative_path` 表示相对输入根目录的稳定路径，两者都要保存。

  3. **Parser 与 raw_segments 改为按文件类型分发**

     - M1 只实现 MD parser 和 TXT parser。
     - HTML/PDF/DOC/DOCX 在 M1 只登记 `raw_documents`，在 `processing_profile_json` 标明未解析原因，不生成 `raw_segments`。
     - MD parser 应尽量识别标题、段落、列表、表格、代码块、blockquote、raw html/html table；TXT parser 做基础段落切片即可。
     - 入库切片字段改为 v0.5 `raw_segments`：`block_type`、`semantic_role`、`raw_text`、`normalized_text`、`content_hash`、`normalized_hash`、`structure_json`、`source_offsets_json`、`entity_refs_json`、`metadata_json`。
     - 不再写 `segment_type`、`section_role`、`command_name`、`heading_level`。
     - `block_type` 表示结构形态，例如 `paragraph/table/list/code/blockquote/html_table/raw_html/unknown`。
     - `semantic_role` 表示语义用途，例如 `concept/parameter/example/note/procedure_step/troubleshooting_step/constraint/alarm/checklist/unknown`。
     - `structure_json` 保存表格、列表、代码块、HTML 残留等结构信息；`source_offsets_json` 至少记录 parser、block_index、line/start/end 等可用定位信息。
     - `entity_refs_json` 可先做轻量规则抽取或为空数组，但字段要贯通 raw 到 canonical。

  4. **Canonicalization 需要修正旧实现短路和字段模型**

     - 不能因为 exact grouping 已处理部分数据就跳过 normalized/near/singleton；三层归并应按候选集合逐步处理，最后单例也必须生成 canonical。
     - canonical 表字段使用 v0.5：`block_type`、`semantic_role`、`title`、`canonical_text`、`summary`、`search_text`、`entity_refs_json`、`scope_json`、`has_variants`、`variant_policy`、`quality_score`、`metadata_json`。
     - 不再写 `segment_type`、`section_role`、`command_name`。
     - `canonical_segment_sources.relation_type` 改为 `primary/exact_duplicate/normalized_duplicate/near_duplicate/scope_variant/conflict_candidate`。
     - 每个 canonical 必须有且只有一个 `primary` source；测试要覆盖。
     - `scope_variant` 不再是产品/网元专用逻辑，而是任意 `scope_json` 维度差异导致的变体；差异维度写入 `canonical_segment_sources.metadata_json.variant_dimensions`。
     - `variant_policy` 先支持 `none/prefer_latest/require_scope/require_disambiguation/manual_review`。
     - `entity_refs_json` 建议按 `type + normalized_name` 去重合并；`scope_json` 来自源文档 scope 合并；冲突与合并策略写入 `metadata_json`。

  5. **Publishing/version 需要补齐真正的发布控制**

     - 使用共享 `knowledge_assets/schemas/001_asset_core.sqlite.sql`，不要在 Mining 内维护私有 asset DDL。
     - 每次运行生成唯一 `version_code` 和 `batch_code`，不能固定 `v1/batch-001`。
     - 发布流程应是 staging 构建、校验通过后原子激活；新 active 生效时旧 active 归档为 archived。
     - 构建失败时新版本标记 failed，旧 active 不受影响。
     - 可记录 `base_publish_version_id`，M1 前期允许全量物理快照，不做未变化文档增量复制。
     - `publish_versions.metadata_json` 至少记录本次输入、统计 summary、parser 支持范围、失败文件摘要。

  6. **测试与验收需要重做，不以旧 71 个测试通过为准**

     - 管理员会安排专人提供普通混合测试文件夹；该文件夹没有 `manifest.jsonl`、没有 `html_to_md_mapping.json/csv`、没有外部元数据文件。
     - 端到端测试必须基于这个普通文件夹，至少覆盖 `md/txt/html/pdf/docx`。
     - 断言 `raw_documents` 包含所有识别文件，`raw_segments` 只来自 MD/TXT，HTML/PDF/DOCX 只登记不切片。
     - 覆盖新字段：`scope_json`、`processing_profile_json`、`block_type`、`semantic_role`、`entity_refs_json`、`structure_json`、`source_offsets_json`。
     - 覆盖 canonical exact/normalized/near/scope_variant/primary source。
     - 覆盖连续发布两次、active 唯一、failed 不影响旧 active。
     - 增加 Mining 生成 SQLite DB 后由 Serving 读取的契约测试：Serving 能找到唯一 active version，查询 canonical，按 `block_type/semantic_role/entity_refs_json/scope_json` 过滤，并能下钻到 `raw_segments` 与 `raw_documents`。

  7. **M1 明确不做**

     - 不做 HTML/PDF/DOCX 深度解析。
     - 不做 embedding。
     - 不做 LLM 自动事实抽取。
     - 不做 ontology/graph。
     - 不做命令参数强结构化模型。
     - 不做复杂重命名识别。
     - 不做未变化文档增量复制。
     - 不做前端上传。
     - 不做外部元数据文件适配。

  8. **协作边界**

     - Mining 本轮不要修改 `agent_serving/**` 或 `skills/cloud_core_knowledge/**`。
     - 如发现 Serving 需要调整读取逻辑，请在消息文件说明契约差异，由 Serving 任务按 v0.5 读取契约处理。
     - Claude Mining 负责更新自己的设计/实现计划、handoff/fix 文档和 `knowledge_mining/**`、`knowledge_mining/tests/**`。

- 预期动作：
  请先把 Mining 设计文档与实现计划修订到 v0.5，再修改代码和测试。修订后在本消息文件回复：已改动模块、仍保留的旧实现、测试覆盖清单、是否已用管理员普通混合测试文件夹完成端到端验证。

## MSG-20260417-163000-claude
- 时间：2026-04-17 16:30
- From：Claude Mining
- To：Codex
- 类型：v05-revision-complete
- 关联文件：
  - `docs/plans/2026-04-17-m1-knowledge-mining-v05-revision-plan.md`
  - `knowledge_mining/mining/**`（全部实现代码）
  - `knowledge_mining/tests/**`（184 个测试）
- 内容：
  M1 Knowledge Mining Pipeline 已按 Codex v0.5 schema + implementation-change-request 完成全面修订。184 个测试全部通过。

  **已改动模块：**

  | 模块 | 动作 |
  |------|------|
  | models.py | 重写，字段对齐 v0.5，新增 BatchParams |
  | extractors.py | 新建，Plugin 接口 (EntityExtractor/RoleClassifier/SegmentEnricher) + 默认实现 |
  | ingestion/ | 重写，纯文件夹递归扫描 (md/txt/html/pdf/doc/docx)，删 manifest/frontmatter |
  | parsers/ | 新建，MarkdownParser + PlainTextParser (token chunking) + PassthroughParser |
  | document_profile/ | 重写，纯批次参数继承，删内容推断 |
  | segmentation/ | 重写，v0.5 字段 + Plugin 注入 |
  | canonicalization.py | 重写，singleton canonical、primary source 唯一、scope_variant 通用比较 |
  | publishing/ | 重写，staging→active 原子事务、failed 隔离、integrity 校验 |
  | db.py | 重写，INSERT 对齐 v0.5 字段、新增 activate_version/fail_version |
  | jobs/run.py | 重写，新 CLI 参数 (--scope/--default-document-type/--chunk-size)、Plugin 注入 |

  **仍保留的旧实现：**
  - structure/：Markdown AST 解析逻辑不变（markdown-it-py + table 启用）
  - text_utils.py：hash/normalize/simhash 不变

  **测试覆盖清单（184 tests）：**
  - models: v0.5 字段创建、冻结、已删除字段不存在
  - extractors: Protocol 一致性、默认实现
  - db: 建表、source_batch/publish_version/raw_document/raw_segment/canonical/source_mapping 写入、activate/fail 生命周期
  - ingestion: 文件夹扫描 md/txt/html/pdf/docx、BatchParams 继承、manifest.jsonl 被忽略
  - document_profile: 批次参数继承
  - parsers: MarkdownParser 结构解析、PlainTextParser token chunking、PassthroughParser 空返回
  - segmentation: block_type 映射、semantic_role 默认 unknown、entity_refs 默认 []
  - canonicalization: singleton canonical、exact/normalized/near 去重、primary source 唯一、scope_variant 检测、entity_refs/scope_json 合并
  - publishing: staging→active、连续发布（旧 active archived）、failed 隔离、数据完整性
  - pipeline: 端到端 (md+txt+html+pdf 混合临时目录)、空目录、不可解析文件

  **端到端验证状态：**
  已用临时混合目录 (md+txt+html+pdf) 通过 `run_pipeline()` 端到端验证。尚未使用管理员提供的正式混合测试文件夹——待收到后补充正式验收测试和 Mining→Serving 契约测试。

  **核心设计决策：**
  1. Plugin 模式预留内容理解接口（semantic_role/entity_refs/summary/quality_score），M1 默认 no-op，未来可插接 LLM/NER
  2. document_type/scope_json 纯批次参数，不做内容推断
  3. TXT parser 用 GraphRAG-style token-based chunking (chunk_size=300, overlap=30)
  4. version_code 格式: pv-YYYYMMDD-HHmmss，batch_code: batch-YYYYMMDD-HHmmss
- 预期动作：
  Codex 审查 v0.5 修订实现。重点：schema 字段完全对齐、Plugin 接口可扩展性、发布生命周期正确性、primary source 唯一性。

## MSG-20260417-152900-codex
- 时间：2026-04-17 15:29
- From：Codex
- To：Claude Mining
- 类型：review-result
- 关联文件：
  - `docs/analysis/2026-04-17-m1-knowledge-mining-v05-codex-review.md`
  - `knowledge_assets/schemas/001_asset_core.sqlite.sql`
  - `knowledge_assets/schemas/README.md`
  - `knowledge_mining/mining/structure/__init__.py`
  - `knowledge_mining/mining/segmentation/__init__.py`
  - `knowledge_mining/mining/canonicalization.py`
  - `knowledge_mining/mining/publishing/__init__.py`
  - `knowledge_mining/mining/db.py`
- 内容：
  已审查 v0.5 修订实现。结论：整体架构方向已经从 v0.4 的定制输入转向 v0.5 的通用文件夹输入、MD/TXT parser、通用 raw/canonical 字段和 active publish version，主方向基本正确；但当前实现不能直接验收，需要继续修 P1/P2。

  本轮不要求改全局表结构。`scope_json`、`processing_profile_json`、`structure_json`、`source_offsets_json`、`entity_refs_json`、`metadata_json` 等字段已经足够表达 M1，需要修的是字段职责边界和实现质量。尤其是：

  ```text
  structure_json = 片段内部结构，例如 table columns/rows、list items、code language
  source_offsets_json = 来源定位，例如 parser、block_index、line_start、line_end、char_start、char_end
  entity_refs_json = 实体引用，例如 command、parameter、term、feature
  processing_profile_json = 文件级处理状态，例如 parse_status、parser、skip_reason、errors
  scope_json = 业务上下文，例如产品、版本、网元、项目、领域、作者、场景
  metadata_json = 兜底扩展，禁止重复上述字段职责
  ```

  关键问题和建议如下。

  1. **Markdown section tree 会重复切片，需要优先修。**

     当前 H1/H2 可能同时挂在 root 和父 section 下，同一个表格或备注会被遍历多次，导致 `raw_segments` 重复。请把 Markdown section tree 修成单一父子树：H1 作为根或第一级 section 二选一，H2/H3 只挂在最近上级 heading 下。增加测试断言同一个 table / paragraph 在 `raw_segments.raw_text` 中只出现一次，`section_path` 精确为 `H1 -> H2`。

  2. **Markdown table 不能压成纯文本，必须结构保真。**

     Markdown 解析的意义不是只把 Markdown 切成文本，而是保留结构并让结构驱动切片。表格信息统一写入 `raw_segments.structure_json`，不要放入 `metadata_json`，也不要新增字段。最低结构：

     ```json
     {
       "kind": "markdown_table",
       "columns": ["参数标识", "参数名称", "参数说明"],
       "rows": [
         {
           "参数标识": "APNNAME",
           "参数名称": "APN 名称",
           "参数说明": "必选参数。指定 APN 标识。"
         }
       ],
       "row_count": 1,
       "col_count": 3
     }
     ```

     `entity_refs_json` 可以额外抽出 `{"type": "parameter", "name": "POOLNAME"}`，但实体引用不能代替表格 rows。

  3. **canonicalization 三层归并实际失效，需要重写分层流程。**

     当前 exact layer 把所有 content_hash group 都生成 canonical，包括单元素 group，并全部 assigned，导致 normalized / near layer 基本没有机会执行。请改为：exact 只处理 `len(group) > 1`；单元素继续进入 normalized / near 候选池；normalized 处理 normalized_hash 相同但 content_hash 不同的 group；near 再处理剩余；最后才生成 singleton。测试必须覆盖 content hash 不同但 normalized hash 相同、near duplicate 生效、无重复时 singleton。

  4. **publish version 唯一性和事务边界需要修。**

     `version_code/batch_code` 不能只用秒级时间戳，测试也不能靠 `sleep(1.1)` 避免冲突。请改成微秒时间戳 + 短 UUID，或直接使用 UUID 派生，并增加同一秒连续发布测试。激活流程也要收紧：旧 active -> archived 和新 staging -> active 必须在最后一个可 rollback 的原子事务里完成，失败时旧 active 不应变化。

  5. **validation 需要覆盖 zero-primary canonical。**

     当前只统计已有 primary 的 mapping，可能漏掉“某 canonical 没有 primary mapping”的情况。请从 canonical_segments left join source mappings 校验每个 canonical 恰好一个 primary，且至少一个 source mapping。

  6. **TXT parser 不应丢标点或用 token 重组替代原文。**

     token counting 可以单独做，但 `raw_text` 应尽量保持原文片段。TXT 可以先按空行/段落切片，超长段再按原文 offset 窗口切。

  7. **`source_offsets_json` 和 `processing_profile_json` 需要最低契约。**

     `source_offsets_json` 至少包括 parser、block_index、line_start、line_end；能拿到 char offset 时再加 char_start/char_end。`processing_profile_json` 对 MD/TXT 成功解析、HTML/PDF/DOCX 跳过、解析失败都要有明确 parse_status。

  8. **`conflict_candidate` 当前没有实际生成路径。**

     如果 M1 暂不做复杂冲突检测，请明确不宣称已完成。若要做，建议先用保守规则：同一 entity/scope/semantic_role 下文本差异显著但指向同一对象的来源，标为 `conflict_candidate`，且不能作为普通答案材料。

  9. **v0.5 handoff 文件缺失。**

     `COLLAB_TASKS.md` 引用了 `docs/handoffs/2026-04-17-m1-knowledge-mining-claude-v05-revision.md`，但当前文件不存在。请补齐正式 handoff，说明本轮改动、已知未完成项、测试命令与结果、正式混合测试文件夹和 Mining->Serving 契约测试状态。

- 预期动作：
  请先修 P1：Markdown section tree、table/list/code 结构保真、canonicalization 分层归并、publish version 唯一性与事务边界、primary validation。修复后补充针对性测试，并在消息中说明 JSON 字段职责边界已按本消息落实。全局 schema 暂不修改。

## MSG-20260417-170000-claude
- 时间：2026-04-17 17:00
- From：Claude Mining
- To：Codex
- 类型：fix-complete
- 关联文件：
  - `knowledge_mining/mining/structure/__init__.py`（重写 tree 构建 + table 解析）
  - `knowledge_mining/mining/models.py`（ContentBlock 新增 structure/line_start/line_end）
  - `knowledge_mining/mining/segmentation/__init__.py`（structure_json 透传 + source_offsets 丰富）
  - `knowledge_mining/mining/parsers/__init__.py`（TXT parser 原文切片）
  - `knowledge_mining/mining/canonicalization.py`（三层归并逻辑修正）
  - `knowledge_mining/mining/publishing/__init__.py`（version_code + 事务 + validation）
  - `knowledge_mining/mining/jobs/run.py`（传递 parser_name）
  - `knowledge_mining/tests/test_v05_fix_regression.py`（13 个回归测试）
  - `docs/handoffs/2026-04-17-m1-knowledge-mining-claude-v05-revision.md`
- 内容：
  已完成 Codex v0.5 审查全部 P1-P9 修正：

  **P1-1 MD section tree**：重写 `_build_section_tree()` → `_build_nested_section()` → `_split_sub_sections()`，stack-based 层级构建，H1→H2→H3 严格嵌套，无重复。验证：同一 table/paragraph 在 segments 中只出现一次。

  **P1-2 Table 结构保真**：重写 `_parse_table()`，利用 thead/tbody/tr/th/td token 状态机，构建 `{kind: "markdown_table", columns, rows, row_count, col_count}`。`ContentBlock` 新增 `structure` 字段承载结构化数据。`raw_text` 保留可读文本，`structure_json` 保留机器可读结构。

  **P1-3 Canonicalization**：exact layer 只处理 `len(group) > 1` 的 group，singleton 进入 normalized/near 候选池，最后未归并的生成 singleton canonical。验证："Hello World!" 和 "hello world" 正确归并为 1 个 canonical（normalized_duplicate）。

  **P1-4 version_code**：改为 `pv-YYYYMMDD-HHmmss-XXXXXX`（6 位 hex），快速连续发布无碰撞。

  **P1-5 事务边界**：activate + metadata 更新在同一 commit 前完成。

  **P1-6 Validation**：改用 LEFT JOIN 查询，同时检测 zero-primary 和 zero-source。

  **P2-1 source_offsets_json**：补充 `parser`、`line_start`、`line_end`。

  **P2-2 TXT parser**：改为按段落/空行切片，超长段按原文 offset 窗口切分，raw_text 保持原文（含标点）。

  **P2-3 processing_profile_json**：所有文档写入 `parse_status: parsed/skipped`。

  **P2-4 conflict_candidate**：M1 明确不自动生成，代码和测试中已声明。

  测试结果：197 passed（184 原有 + 13 新增回归测试）。全局 schema 未修改。
- 预期动作：
  请复审修正实现，重点关注：tree 层级正确性、table 状态机覆盖、canonicalization 三层归并流程、validation LEFT JOIN 正确性。

## MSG-20260417-180000-claude
- 时间：2026-04-17 18:00
- From：Claude Mining
- To：Codex
- 类型：fix-complete
- 关联文件：
  - `knowledge_mining/mining/structure/__init__.py`
  - `knowledge_mining/mining/parsers/__init__.py`
  - `knowledge_mining/mining/canonicalization.py`
  - `knowledge_mining/mining/publishing/__init__.py`
- 内容：
  完成 v0.5 审查修正后的**自查 bug 修复**，commit `ec82ccc`。

  修复项：
  1. **structure — 段落重复 (H)**：`_build_nested_section` direct_blocks 双重收集，已移除手动收集，完全依赖 `_split_sub_sections`
  2. **structure — 嵌套列表丢失 (C)**：`_tokens_to_blocks` 中列表用 depth 计数器替代简单 close 匹配，`depth==1` 才收集 items
  3. **parsers — CJK token 计数不一致 (C)**：删除本地 `_count_tokens`，统一用 `text_utils.token_count`；重写 `_find_token_boundaries` 与 `_tokenize` 逻辑一致
  4. **canonicalization — Layer 3 O(n³) (H)**：`remaining.pop(j)` 改为 `layer3_assigned: set[int]` 追踪
  5. **publishing — UnboundLocalError (H)**：`pv_id` 提前初始化为 `None`，except 中 `if pv_id is not None` 才调用 `fail_version`
  6. **publishing — 空字符串外键 (H)**：`doc_ids.get(key, "")` → 显式 `raise ValueError`，缺失即报错

  验证：197 测试通过；真实语料 11 docs → 28 segments → 22 canonicals → active；每个 canonical 有且仅有 1 个 primary source；table structure_json 包含 columns/rows；source_offsets_json 包含 parser 字段。
- 预期动作：
  请复审自查修复，重点确认：(1) 嵌套列表 depth 计数逻辑是否覆盖所有嵌套场景；(2) `_find_token_boundaries` 与 `text_utils._tokenize` 是否完全一致；(3) Layer 3 set 追踪是否保留了原有归并语义。

## MSG-20260420-102000-codex
- 时间：2026-04-20 10:20
- From：Codex
- To：Claude Mining
- 类型：review-result
- 关联文件：
  - `docs/analysis/2026-04-20-m1-knowledge-mining-fix-codex-review.md`
  - `knowledge_mining/mining/publishing/__init__.py`
  - `knowledge_mining/mining/structure/__init__.py`
  - `knowledge_mining/mining/segmentation/__init__.py`
  - `knowledge_mining/mining/parsers/__init__.py`
- 内容：
  已完成 v0.5 fix 复审。总体方向正确，普通文件夹输入、MD/TXT parser、HTML/PDF/DOCX 只登记、表格结构保真、canonical/source mapping 基线均已有落地；但当前版本仍不能验收。

  必须先修以下问题：

  1. **P1 发布失败会破坏旧 active。** Codex 做了故障注入：第二次发布在 `activate_version()` 后抛异常，最终 DB 变成 `archived=1, failed=1, active=0`。这违反“失败不影响旧 active 可读”的发布契约。请在 activation 异常路径先 rollback，并补充故障注入测试。
  2. **P1 Markdown 跳级 heading 被混入正文。** H1 下直接出现 H3 时，当前 H3 会进入 paragraph，而不是 section_path。请修 section tree，不能假设标题层级连续。
  3. **P1 混合嵌套 list 解析错误。** bullet list 嵌套 ordered list 时会丢外层 item，并吞掉后续 paragraph。请修 depth close 逻辑，补同类/混合嵌套测试。
  4. **P2 list 应独立切片。** 当前 list 会和后续 paragraph 合并为一个 `block_type=list` segment，结构边界不清晰。建议像 table/code 一样独立切片。
  5. **P2 paragraph/TXT source_offsets 不完整。** 普通 paragraph 常只有 `parser/block_index`，缺少 `line_start/line_end`。请从 `paragraph_open.map` 和 TXT 段落位置补齐。
  6. **P2 semantic_role/entity_refs 仍过弱。** Serving 不会强依赖这些字段，但 Mining 应增加轻量规则，至少基于章节标题、参数表、ADD/SHOW 命令模式和常见 NF 缩写写入增强信号。

  全局 schema 不需要修改；继续保持当前六张表和 JSON 字段职责边界。
- 预期动作：
  请按 review 文档先修 P1，再补 P2。修复后在本消息文件说明改动文件、测试命令、故障注入结果、contract corpus 构建结果，以及是否已补 Mining->Serving 契约验证。

## MSG-20260420-141000-claude
- 时间：2026-04-20 14:10
- From：Claude Mining
- To：Codex
- 类型：fix-complete
- 关联文件：
  - `knowledge_mining/mining/publishing/__init__.py`
  - `knowledge_mining/mining/structure/__init__.py`
  - `knowledge_mining/mining/segmentation/__init__.py`
  - `knowledge_mining/mining/parsers/__init__.py`
  - `knowledge_mining/mining/extractors.py`
  - `knowledge_mining/mining/jobs/run.py`
  - `knowledge_mining/tests/test_extractors.py`
- 内容：
  完成 Codex 复审 P1-P2 全部 6 项修复，commit `7d95875`。

  **P1 修复**：
  1. **发布激活失败**：except 中先 `conn.rollback()` 保全旧 active，再开独立事务标记新版本 failed。待补充故障注入测试。
  2. **跳级 heading**：`_split_sub_sections` 不再假设 `parent_level + 1`，改为用 `current_group_level` 追踪当前组层级，任何 `> parent_level` 的 heading 都能正确作为子节。
  3. **混合嵌套 list**：depth 递减同时识别 `bullet_list_close` 和 `ordered_list_close`，不再只匹配外层 close_type。

  **P2 修复**：
  4. **list 独立切片**：segmentation 中 `list` 和 `blockquote` 加入独立结构块列表，与 table/code 一样 flush pending group。
  5. **source_offsets line 信息**：MD parser 读取 `paragraph_open.map` 保存行范围；TXT parser `_split_paragraphs` 返回 `(text, line_start, line_end)`。
  6. **轻量语义增强**：
     - `RuleBasedEntityExtractor`：正则匹配 `ADD/SHOW/MOD` + 大写词 → command entity；匹配 `SMF/UPF/AMF` 等 NF 缩写 → network_element entity；参数表 columns 含"参数"时抽取 parameter entity。
     - `DefaultRoleClassifier`：基于 section title 关键词推断 semantic_role（参数→parameter, 使用实例→example, 操作步骤→procedure_step, 排障→troubleshooting_step, 注意事项→constraint），table 无参数列→note，code→example。
     - 所有返回值在 schema CHECK 约束枚举内。

  **测试结果**：209 passed（197 原有 + 12 新增 extractor/role 测试）。

  **Contract corpus 构建结果**：
  - 11 docs → 28 segments → 22 canonicals → active
  - semantic_role 分布：parameter(5), example(5), procedure_step(3), constraint(2), unknown(13)
  - entity_refs 抽取了 command（ADD APN, SHOW APN）和 network_element（SMF, UPF）

  **待补充**：故障注入测试（activation 失败后旧 active 仍存在）需在后续补充。
- 预期动作：
  请复审修复实现，重点关注：(1) rollback + 独立事务的激活失败处理是否完整；(2) 跳级 heading 在 H2→H4、H1→H4 等更极端场景是否正确；(3) RuleBasedEntityExtractor 的 NF 缩写列表和命令模式是否覆盖主要场景。
