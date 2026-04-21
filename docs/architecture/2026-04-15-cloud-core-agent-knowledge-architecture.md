# 云核心网 Agent Knowledge Backend 总体架构设计

> **版本**: v1.1 (2026-04-21)
> **审阅**: Codex 初稿 → Claude 审视修订 → Codex 边界校正 → Codex alias_dictionary 风险修正 → Codex 挖掘态/使用态并行开发拆分 → Codex v1.1 snapshot/build/release 架构收口

## 1. 文档目的

本文档沉淀当前项目的新架构基线，供 Claude Code 后续制定实现计划和开发使用。

当前仓库已将旧项目完整代码移动到 `old/`。旧代码不再作为新系统的直接运行入口，只作为参考实现和可剥离资产来源。新系统不应继续沿用旧项目”大一统 pipeline + API + ontology governance”的组织方式，而应按真实业务使用链路重新设计。

本项目的新目标是构建一套面向云核心网知识使用的 Agent Knowledge Backend，使 Agent 能通过 Skill 调用后端服务，查询产品文档、命令手册、配置指南、专家文档和项目文档中的概念解释、参数说明、操作步骤、注意事项、适用范围和来源证据。

### 修订记录

| 日期       | 来源   | 变更摘要                                                                 |
| ---------- | ------ | ---------------------------------------------------------------------- |
| 2026-04-15 | Codex  | 初稿：五层架构、目录结构、里程碑 M0-M8                                    |
| 2026-04-15 | Claude | 审视修订：单 pyproject.toml、补充 Query Normalizer、合并里程碑、补充 dev mode、answer_materials 子结构、alias_dictionary 来源、schema 治理权 |
| 2026-04-15 | Codex  | 边界校正：修正 dev SQLite 共享问题、统一运行入口、补充根目录 scripts、修正 alias_dictionary 来源、细化 M3 子任务 |
| 2026-04-15 | Codex  | alias_dictionary 风险修正：old/ontology 不可靠，不作为正式 alias 来源；M0 改为规则占位；正式 alias 从用户导入的 Markdown 文档中抽取 |
| 2026-04-15 | Codex  | 明确 Knowledge Mining 与 Agent Serving 独立开发，以数据库知识资产为唯一桥梁；新增 L0/L1/L2 资产分层与并行任务边界 |
| 2026-04-16 | Codex  | schema v0.4：引入通用 source artifact 视角，支持 Markdown/HTML/PDF/DOC 等来源；产品/版本/网元降级为可选 scope/facet；纳入 productdoc_to_md.py 上游转换链路 |
| 2026-04-17 | Codex  | schema v0.5：M1 输入收敛为普通文件夹递归扫描，不考虑外部元数据文件；M1 只解析 Markdown/TXT；raw/canonical 字段统一为 block_type、semantic_role、entity_refs_json、scope_json |
| 2026-04-17 | Codex  | M1 契约收口：Mining 尽力抽取结构化信息，Serving 灵活读取且不得强依赖 JSON 必含字段；EvidencePack 必须能返回 raw structure/source offsets；不改六张 asset 表 |
| 2026-04-21 | Codex  | v1.1 架构收口：放弃 canonical 主路径；资产主链改为 `document -> shared snapshot -> raw_segments/relations/retrieval_units -> build -> release`；Mining/Serving/LLM 三库边界定稿 |

本轮并行开发上下文详见：

```text
docs/architecture/2026-04-15-mining-serving-parallel-design.md
```

## 2. 核心共识

整体架构按以下链路组织：

```text
Agent
  ↓
Skill
  ↓
Agent Serving / 运行态服务
  ↓
Knowledge Assets / asset_core
  ↑
Knowledge Mining / 挖掘态服务
  ↑
Raw Documents / 原始资料
```

关键原则：

- Agent 层依赖已有 Agent 框架，不在本项目内重做。
- Skill 层保持轻量，只负责工具封装、调用策略、回答格式和追问规则。
- Agent Serving 是运行态，只读 active `release` 对应的 `build`，面向 Skill 提供通用知识检索与上下文组装能力。
- Knowledge Assets 是中间产物契约，核心主链为：

```text
source_batch
  -> document
  -> shared snapshot
  -> document_snapshot_link
  -> raw_segments / raw_segment_relations / retrieval_units
  -> build
  -> release
```

- Knowledge Mining 是设计态/挖掘态，负责从原始资料生产共享内容快照、下游事实对象、build 与 release。
- `snapshot` 是共享内容快照，不是文档专属快照；多个文档可以引用同一份 snapshot。
- `build` 的语义是“这次知识视图里每个 document 采用哪个 snapshot”。
- `publish` 的正式语义是 `release -> build`，不是换文件，也不是简单日志。
- Mining 运行态、知识资产、LLM 运行态必须逻辑分库。
- `old/` 只读参考，新代码不得 `import old.*`。

## 3. 分层职责

### 3.1 Agent 层

Agent 层由外部已有 Agent 框架承载。

职责：

- 理解用户问题。
- 判断是否需要调用云核心网知识 Skill。
- 根据 Skill 返回的 context pack 组织最终答案。
- 在厂家、产品、版本、EPC/5GC 场景缺失时追问或提示不确定性。

不负责：

- 直接查询数据库。
- 直接访问向量索引。
- 直接执行图遍历。
- 理解挖掘 pipeline 的内部实现。

### 3.2 Skill 层

Skill 是 Agent 与后端服务之间的轻量契约。

职责：

- 定义可调用工具。
- 描述何时调用哪个工具。
- 约束回答模板。
- 处理缺失上下文的追问规则。
- 将 Agent 的自然语言意图转为后端 API 请求。

第一版 Skill 至少包含：

```text
search_cloud_core_knowledge
```

Skill 不做：

- 文档检索实现。
- 重排序。
- 图扩展。
- 数据库访问。
- 批量知识加工。

### 3.3 Agent Serving / 运行态服务

运行态服务是 Skill 调用的在线后端。

职责：

- query understanding / 归一化
- 简单 planner / query plan 生成
- retrieval_units 主检索
- 基于 raw segment relations 的上下文扩展
- ContextPack / EvidencePack 组装
- 证据与来源返回
- 检索日志和调试解释

运行态服务只读 `asset_core` 中 active `release` 对应 `build` 的数据。

运行态服务主读取链路应为：

```text
active release
  -> build
  -> selected document snapshots
  -> retrieval_units
  -> source_refs_json
  -> raw_segments
  -> raw_segment_relations
  -> document_snapshot_links / documents
```

运行态不做：

- 文档解析
- 内容快照生成
- 原始切片
- build 组装
- release 发布
- LLM 结果落库

v1.1 运行态读取原则：

- Serving 以 active `release` 为唯一入口，但必须检测 0/1/>1 active 的异常情况。
- Serving 主检索对象是 `retrieval_units`，不再围绕 canonical。
- Serving 可以利用 `entity_refs_json/facets_json/semantic_role/block_type` 增强召回、过滤和排序，但不能把这些 JSON 子字段视为必填前提。
- Serving 必须将下钻得到的 `raw_segments.structure_json` 和 `raw_segments.source_offsets_json` 原样返回给 Agent；表格、列表、代码结构不能在运行态被压成纯文本。
- Query Understanding/Planner 当前可以是规则实现，但必须保守、可替换，并为后续 LLM query rewrite / rerank / context compression 预留插点。

### 3.4 Knowledge Assets / 知识资产层

知识资产层是系统最关键的中间契约。

它承载挖掘态产出的可发布数据，并为运行态提供稳定读取模型。

v1.1 的核心资产包括：

```text
source_batches
documents
document_snapshots
document_snapshot_links
raw_segments
raw_segment_relations
retrieval_units
builds
build_document_snapshots
publish_releases
```

核心要求：

- 所有在线查询必须基于某个 active `release`。
- `release` 必须指向某个 `build`。
- `build` 必须定义“每个 document 采用哪个 snapshot”。
- `snapshot` 必须是共享内容快照，而不是文档专属快照。
- 挖掘态不得直接覆盖运行态对外可见的知识视图；只有进入 `release` 的 `build` 才对 Serving 可见。
- `raw_segments / raw_segment_relations / retrieval_units` 都挂在共享 snapshot 之下，成为 Serving 下钻与扩展的事实基础。

v1.1 的知识资产分为三层：

| 层级 | 中文名称 | 核心含义 | 默认是否直接检索 |
| --- | --- | --- | --- |
| A0 | 身份与内容层 | `documents` 定义逻辑文档身份，`document_snapshots` 定义共享内容快照，`document_snapshot_links` 定义文档到快照的引用关系 | 否 |
| A1 | 事实与检索层 | `raw_segments`、`raw_segment_relations`、`retrieval_units` 定义事实单元、上下文关系和检索单元 | 是（主入口是 `retrieval_units`） |
| A2 | 视图与发布层 | `builds`、`build_document_snapshots`、`publish_releases` 定义完整知识视图及其正式发布 | 否（作为读取边界） |

### 3.5 Knowledge Mining / 挖掘态服务

挖掘态服务负责从原始资料生产知识资产。

阶段 1A / v1.1 只聚焦“原始资料 -> 共享内容快照 -> facts / retrieval -> build / release”这条主链，不做完整本体抽取。

职责：

- 原始文档接入
- 逻辑文档识别（`document_key`）
- 共享内容快照复用或创建（基于 `normalized_content_hash`）
- 文档到快照映射建立
- section / segment 生成
- raw segment 轻量标注
- raw segment relation 构建
- retrieval unit 生成
- build 组装
- build 校验
- release 发布

Mining 在实现上应明确拆成两个阶段：

```text
Phase 1: Document Mining
  输入：source_batch + 输入文件
  输出：documents / snapshots / links / raw_segments / relations / retrieval_units

Phase 2: Build & Publish
  输入：committed snapshots + 上一个 active build（可选）
  输出：build + release
```

M1 解析器边界：

```text
Markdown -> raw_segments
TXT      -> raw_segments
HTML/PDF/DOC/DOCX -> 允许先建 document / snapshot / link，但深度解析后置
```

PDF、Word、HTML 深度解析后置，但 schema 必须能登记这些原始来源。M1 不考虑 `manifest.jsonl`、`html_to_md_mapping.json/csv` 或其他外部元数据文件；Mining 只能基于文件夹递归扫描、文件后缀、相对路径、目录结构、文件名和文件内容做识别与推断。

## 4. 推荐目录结构

> **Claude 审视修订**: 阶段 1A 采用单 `pyproject.toml` + 目录隔离，而非独立 Python 包。理由：内网单机部署，两个独立包增加依赖管理和部署成本，数据库 schema 隔离已提供足够的运行态边界。后续如需独立部署再拆包。

建议根目录组织如下：

```text
Self_Knowledge_Evolve/
  pyproject.toml                    # 单一项目配置，统一依赖管理
  .env.example
  scripts/                          # 跨层运维脚本
    init_db.py                      # 统一初始化 mining/asset/serving schema
    run_dev_demo.py                 # 可选：同进程最小 demo runner

  docs/
    architecture/                   # 架构设计文档（本文件所在目录）
    messages/
    plans/
    handoffs/
    analysis/

  old/
    ...旧项目完整代码，只读参考...

  knowledge_mining/                 # 挖掘态：文档加工 pipeline
    mining/
      ingestion/                    # P1 文档接入
      document_profile/             # P2 文档画像识别
      structure/                    # P3 章节结构恢复
      segmentation/                 # P4 segment 切分
      annotation/                   # P5 segment 轻量标注
      command_extraction/           # P6 命令抽取
      edge_building/                # P7 关系构建
      embedding/                    # P8 embedding 生成
      quality/                      # P9 质量门控
      publishing/                   # P10 发布版本生成
      jobs/                         # pipeline 编排与任务调度
    scripts/
      run_mining.py                 # 挖掘态入口脚本
    tests/

  databases/                        # 数据库契约目录
    asset_core/                     # 知识资产库：schema + 静态资产
      schemas/                      # 唯一 asset schema 定义源（见 §4.1）
      dictionaries/                 # alias / pattern / term 规则
      samples/                      # 评测集（见 §4.3）
    mining_runtime/                 # Mining 运行态库契约
      schemas/
    agent_llm_runtime/              # LLM Runtime 库契约
      schemas/

  agent_serving/                    # 运行态：在线检索服务
    serving/
      api/                          # FastAPI 路由
        search.py                   # POST /api/v1/search
        health.py                   # GET /health
        debug.py                    # POST /debug/retrieve, /debug/explain
      application/                  # 业务编排
        normalizer.py               # 查询归一化（见 §4.4）
        planner.py                  # 检索计划生成
        assembler.py                # context pack 组装
      retrieval/                    # 多路召回
        keyword_search.py
        vector_search.py
        metadata_filter.py
      expansion/                    # 上下文扩展
        edge_expander.py
      rerank/                       # 重排序
        lexical_reranker.py
      evidence/                     # 证据打包
        evidence_builder.py
      schemas/                      # request/response 模型
      repositories/                 # 数据访问层
      observability/                # 日志、指标
    scripts/
      run_serving.py                # 运行态入口脚本
    tests/

  skills/                           # Skill 层：Agent 工具定义
    cloud_core_knowledge/
      SKILL.md                      # Skill 主描述
      tools.md                      # 工具定义与选择策略
      answer_templates.md           # 回答模板
      followup_rules.md             # 追问规则
      examples.md                   # 示例问题与预期回答
```

如果 Claude 第一轮需要降低工程复杂度，可以先创建目录骨架和 README，不必一次性填满所有模块。

### 4.1 Schema 治理权

`databases/asset_core/schemas/` 是**唯一 asset schema 定义源**。

- Mining 和 Serving 都从这里读取表结构定义。
- Schema 变更必须通过 migration 文件记录，由根目录脚本 `scripts/init_db.py` 统一执行。
- Mining 和 Serving 均不得自行创建或修改 asset 表结构。

### 4.2 alias_dictionary 数据来源

> **Codex 风险修正 (v0.4)**: `old/ontology` 中的云核心网本体不可靠，不能作为正式 alias_dictionary 的来源。

阶段 1A 的 alias_dictionary 策略：

- **系统不依赖预置本体或旧 alias 字典启动。**
- 用户运行时导入 source artifacts 后，系统基于上游转换结果、Markdown/HTML 标题、表格、代码块、列表和弱规则自动生成可检索的 section、segment、命令候选、术语候选和上下文扩展边。
- 正式 alias_dictionary 不是 Phase 1A 的前置输入，而是后续从用户导入的产品文档中抽取候选、经人工确认后形成的知识资产。
- M0 阶段只创建规则配置占位文件（command_patterns.yaml、section_patterns.yaml、term_patterns.yaml、builtin_alias_hints.yaml），不生成正式 alias_dictionary。
- `old/ontology` 只能作为参考候选源，不能作为默认 seed，更不能默认加载到 `asset.alias_dictionary`。
- Mining 第一版可以直接使用上游转换好的 Markdown，但必须把输入抽象为 source artifact，不得依赖某一份固定文档格式或 frontmatter。产品/版本/网元只是可选 scope/facet，不是所有语料的必填主轴。

### 4.2.1 Source Artifact 与通用 scope / snapshot

原始语料可能来自 Markdown、TXT、HTML、PDF、DOC/DOCX、专家手写文档或项目交付文档。schema v0.5 使用以下原则：

- `documents.document_key` 记录逻辑文档身份，当前优先取规范化相对路径。
- `document_snapshots.normalized_content_hash` 是共享内容快照的复用边界。
- `document_snapshot_links.source_uri` 记录后端实际读取位置，`relative_path` 记录相对本批次输入根目录路径。
- `document_snapshot_links.scope_json` 记录该文档在本次引用下的文档级 scope；产品/版本/网元不再作为外层字段。
- `document_snapshot_links.tags_json` 记录文档级主题、场景和对象标签。
- `document_snapshots.parser_profile_json` 记录 parser、normalization、extraction profile 等处理过程。
- `raw_segments.block_type` 记录结构形态：paragraph/list/table/html_table/code/raw_html/unknown。
- `raw_segments.semantic_role` 记录语义角色：concept/parameter/example/note/procedure_step/troubleshooting_step/constraint/alarm/checklist/unknown。
- `raw_segments.entity_refs_json` 记录命令、网元、术语、特性等通用实体引用。
- `retrieval_units` 是主检索对象，不再保留 canonical 主路径。

### 4.3 评测集位置

M7 的 30-50 个真实问题评测集存放在 `databases/asset_core/samples/eval_questions.yaml`。

### 4.4 Query Normalizer 模块

> **Claude 审视补充**: 这是检索质量的基石，CoreMaster.md 表 19 已明确定义，需要在架构中显式存在。

Query Normalizer（`serving/application/normalizer.py`）负责：

| 功能         | 阶段 1A 实现方式        | 示例                      |
| ------------ | ---------------------- | ------------------------- |
| 操作词归一化 | 规则字典               | 新增 → ADD，修改 → MOD    |
| 术语归一化   | alias_dictionary       | APN ↔ DNN，N4 ↔ PFCP     |
| 命令实体识别 | 模式匹配 + dictionary  | 识别 `ADD APN`            |
| 过滤条件抽取 | 规则                   | 识别版本、厂家、EPC/5GC   |
| 缺失项识别   | 规则                   | 无厂家/版本时返回 uncertainty |

## 5. 数据库边界

v1.1 正式设计采用三套逻辑数据库：

```text
asset_core
mining_runtime
agent_llm_runtime
```

建议：

- `asset_core` 放稳定知识资产 + build / release 控制面。
- `mining_runtime` 放挖掘过程中的 run / document / stage event。
- `agent_llm_runtime` 放独立 LLM 服务的 task / request / attempt / result / event。

逻辑分库必须坚持；如果未来为了本地开发便利临时放进同一个 SQLite 文件，只能视为 dev 便利，不能作为正式架构基线。

## 6. Phase 1A / v1.1 范围

Phase 1A 是最小可用闭环，不是完整系统。

目标：

```text
用少量云核心网文档，让 Agent 通过 Skill 查询概念、命令、参数、步骤、注意事项和来源证据。
```

必做：

- 项目目录骨架。
- Asset schema 初版。
- 文档身份识别、共享内容快照复用、document-snapshot link 建立。
- section/segment 生成。
- raw_segment_relations。
- retrieval_units。
- build / release。
- `/api/v1/search`。
- Skill 初版文档。
- 30-50 个真实问题评测集。

不做：

- 复杂 PDF/Word 解析。
- 完整 ontology。
- facts/triples。
- Neo4j 依赖。
- 影响分析。
- 故障专家推理。
- 人工审批流。
- Dashboard。
- 旧项目完整 worker 机制。

## 7. Graph-RAG 第一阶段定义

阶段 1A / v1.1 的 Graph-RAG 不使用大图作为强依赖，也不要求 Neo4j。

它通过关系表实现：

```text
asset.raw_segment_relations
```

典型扩展逻辑：

```text
命中 retrieval_unit
  → 通过 source_refs 下钻 raw_segments
  → 扩展 same_section / same_parent_section / previous / next / section_header_of
```

阶段 1A 中 Graph-RAG 的价值不是展示图，而是让 Agent 获取完整上下文和证据组合。

## 8. 运行态 API 初版

### 8.1 `POST /api/v1/search`

通用兜底检索。

适用：

- 命令索引未覆盖。
- 术语解释。
- 模糊问题。
- Skill fallback。

### 8.2 Context Pack 最小字段

运行态返回给 Skill 的核心结构应稳定：

```text
query
intent
normalized
items
relations
sources
conflicts
gaps
suggested_followups
debug_trace
```

`debug_trace` 默认仅 debug 模式返回。

### 8.3 返回材料约定

> **Claude 审视补充**: 这是 Skill 层和 Serving 层的接口契约，越早定稳越好。来自 CoreMaster.md 表 24。

返回的 evidence/context 项可以因 intent 不同而变化，但外层 Context Pack 结构保持不变。

## 9. old 代码剥离策略

`old/` 是参考库，不是运行依赖。

禁止：

```text
from old...
import old...
```

可参考或瘦身迁移：

```text
old/src/pipeline/preprocessing/extractor.py
old/src/pipeline/preprocessing/normalizer.py
old/src/utils/hashing.py
old/src/utils/text.py
old/src/utils/embedding.py
old/src/providers/postgres_store.py
old/src/providers/bge_m3_embedding.py
old/scripts/init_postgres.sql 中 documents / segments / t_rst_relation 思路
old/demo/run_text_to_ontology.py 的内存 demo 思路
```

暂不迁移：

```text
old/src/governance/*
old/src/stats/*
old/src/ontology/*
old/src/operators/*
old/src/api/semantic/*
old/src/pipeline/stages/stage3_align.py 之后的完整本体链路
old/worker.py
old/static/*
```

## 10. 里程碑

Claude Code 后续计划建议按以下里程碑展开。M0 之后拆分为知识挖掘态与 Agent 服务使用态两条线。两条线可以并行开发，但必须以 `databases/asset_core/schemas/` 和契约文档作为唯一桥梁。

### M0 项目骨架

- 创建 `knowledge_mining/`、`databases/`、`agent_serving/`、`skills/` 目录骨架。
- 建立单一 `pyproject.toml` + 依赖配置。
- `agent_serving` 提供 `GET /health`。
- 创建规则配置占位（command_patterns.yaml、section_patterns.yaml、term_patterns.yaml、builtin_alias_hints.yaml）和 Markdown 语料入口（corpus_seed/）。不生成正式 alias_dictionary。
- **验证**: `python -m agent_serving.scripts.run_serving` 能启动，`curl /health` 返回 200。

### M1A Knowledge Mining / 知识挖掘态

- 独立任务 ID：`TASK-20260415-m1-knowledge-mining`。
- 只负责离线生产知识资产。
- 支持普通文件夹递归扫描，登记 Markdown/TXT/HTML/PDF/DOC/DOCX 等 source artifacts。
- 建立 `documents / shared snapshots / document_snapshot_links`。
- 对 Markdown/TXT 生成 `raw_segments / raw_segment_relations / retrieval_units`。
- 组装 `build`，并在校验通过后生成 `release`。
- 不做 FastAPI、Agent Skill、在线检索、context pack。
- 提交信息使用 `[claude-mining]: ...`。

### M1B Agent Serving / 知识使用态

- 独立任务 ID：`TASK-20260415-m1-agent-serving`。
- 只负责在线消费已发布知识资产。
- 读取 active `release -> build`。
- 默认检索 `retrieval_units`。
- 通过 `source_refs_json` 下钻 `raw_segments / raw_segment_relations / document_snapshot_links / documents`。
- 输出 Agent 可用的 context pack、uncertainties、suggested_followups。
- 不做 Markdown 解析、文档导入、去重归并、写入 asset 表。
- 提交信息使用 `[claude-serving]: ...`。

### M2 上下文扩展与向量资产

- 继续完善 `raw_segment_relations`。
- 生成向量资产：批量生成 retrieval unit embedding。
- 发布门控：质量门控检查（空 retrieval unit < 2%，核心问题召回可用），通过后激活 release。
- **验证**: 给定 `ADD APN` 或 `业务感知是什么`，能通过 retrieval + relation expansion 返回完整上下文。

### M3 Serving 检索引擎

- keyword retriever（FTS/BM25）。
- vector retriever。
- metadata filter（vendor/product/version）。
- expansion engine（基于 raw_segment_relations）。
- lexical / semantic reranker。
- **验证**: `/debug/retrieve` 接口能展示多路召回结果和排序分数。

### M4 Context Pack 与业务 API

- `POST /api/v1/search` 作为统一知识检索入口。
- 实现 sources、uncertainties、suggested_followups。
- **验证**: 给定 `ADD APN 命令怎么写` 或 `业务感知是什么`，返回完整的 context pack，包含 evidence、sources、relations、uncertainties。

### M5 Skill 初版

- `skills/cloud_core_knowledge/SKILL.md`。
- 工具定义（search_cloud_core_knowledge）。
- 调用策略（统一走 search，上层按 intent 解释）。
- 回答模板（适用场景/命令模板/参数说明/示例/注意事项/来源/需要确认信息）。
- 追问规则（缺厂家/版本/EPC-5GC 时先给通用答案再提示）。
- 示例问题。
- **验证**: Skill 文档可被 Agent 框架加载并正确路由工具调用。

### M6 评测闭环

- 准备 30-50 个真实问题（`databases/asset_core/samples/eval_questions.yaml`）。
- 评估命令召回率、来源覆盖率、context pack 完整性。
- 根据评测结果调优 reranker 权重和扩展策略。
- **验证**: 核心命令类问题召回率 > 80%，context pack 关键字段非空率 > 90%。

## 11. 开发模式

> **Claude 审视补充**: 旧项目的 dev mode 是非常有价值的开发体验，新架构应延续。

阶段 1A 支持两种运行模式：

### 11.1 开发模式（dev）

- 文件 SQLite 替代 PostgreSQL。
- 内存向量索引替代 pgvector。
- 无需 PostgreSQL、Ollama 等外部服务。
- 通过 `python -m agent_serving.scripts.run_serving` 启动运行态。
- 通过 `python -m knowledge_mining.mining.jobs.run` 运行挖掘态（M2+ 实现）。
- 可选提供 `python scripts/run_dev_demo.py`，在同一进程中完成最小文档导入、资产 seed 和接口 smoke test。
- 适合本地开发和快速验证。

说明：不要使用 SQLite `:memory:` 作为默认 dev 存储。Mining 和 Serving 通常是两个进程，`:memory:` 无法跨进程共享数据，会导致挖掘态写入后运行态读不到资产。若需要纯内存模式，只允许在同进程 demo runner 中使用。

### 11.2 生产模式（prod）

- 三套逻辑数据库：`asset_core / mining_runtime / agent_llm_runtime`。
- pgvector 向量检索。
- Ollama bge-m3 embedding。
- 内网单机部署。

通过环境变量 `APP_ENV=dev|prod` 切换，repository 层根据模式选择不同的数据访问实现。

## 12. 需要 Claude 重点避免的问题

- 不要把 mining pipeline 和 serving API 混在同一个运行服务里。
- 不要让 serving import mining。
- 不要让 mining import serving。
- 不要把旧项目完整复制回来。
- 不要第一阶段引入完整 ontology / facts / Neo4j。
- 不要把 Skill 写成重型检索系统。
- 不要先做 PDF/Word 复杂解析而阻塞命令问答闭环。
- 不要返回裸搜索结果给 Agent，必须稳定 context pack。
- 不要让 mining 和 serving 各自定义 schema，asset schema 定义权归 `databases/asset_core/schemas/`。
- 不要在并行任务中跨范围修改代码：Mining 任务不改 `agent_serving/**`，Serving 任务不改 `knowledge_mining/**`。

## 13. 当前有效决策

- 第一阶段只做 Phase 1A 最小闭环。
- 第一阶段聚焦命令与证据优先。
- 第一阶段 Mining 输入基线为普通语料文件夹递归扫描，不考虑外部元数据文件；schema 支持 Markdown/HTML/PDF/DOC/DOCX/TXT 等原始来源记录。
- 第一阶段正式资产主链为 `source_batches/documents/document_snapshots/document_snapshot_links/raw_segments/raw_segment_relations/retrieval_units/builds/publish_releases`。
- 第一阶段只对 Markdown/TXT 生成 `raw_segments/raw_segment_relations/retrieval_units`；HTML/PDF/DOC/DOCX 可先建立 document/snapshot/link，深度解析后置。
- Mining 侧尽可能抽取结构化信息：`structure_json/source_offsets_json/entity_refs_json/scope_json/processing_profile_json`。
- Serving 侧不得强依赖 JSON 必有字段：`scope_json` 兼容 singular/plural，`entity_refs_json.normalized_name` 缺失时 fallback 到 `name`，结构和定位缺失时返回空对象但不阻断检索。
- 第一阶段 Graph-RAG 使用关系表实现，不强依赖 Neo4j。
- 第一阶段正式坚持逻辑分库：`asset_core / mining_runtime / agent_llm_runtime`。
- 第一阶段采用单 `pyproject.toml`，mining 和 serving 通过目录隔离，不拆独立包。
- `publish_releases` 是运行态读取入口；运行态通过 active `release -> build` 读取知识视图。
- `old/` 不作为 import 依赖。
- `databases/asset_core/schemas/` 是唯一 asset schema 定义源。
- alias_dictionary 不从 `old/ontology` 生成。系统不依赖预置本体启动，正式 alias 从用户导入的 source artifacts 中抽取（M2/M3）。M0 只创建规则配置占位。
- 支持 dev 模式（文件 SQLite + 内存向量索引），降低开发环境依赖。
- 评测集存放在 `databases/asset_core/samples/eval_questions.yaml`。
- M0 之后拆分为 `TASK-20260415-m1-knowledge-mining` 与 `TASK-20260415-m1-agent-serving` 两个可并行任务。
- Mining 与 Serving 通过数据库知识资产契约对接，代码不得互相 import。
- 后续 Claude 提交必须区分工作范围：挖掘态使用 `[claude-mining]: ...`，使用态使用 `[claude-serving]: ...`。
