# Lora 项目开发指南

本文是基于当前仓库代码、测试、示例和既有 `doc_design` 文档整理的开发指南。目标是让新开发者可以直接理解项目边界、调用关系、每个公开接口和主要内部方法的职责，并能在不破坏 session、trace、case run 证据链的前提下继续开发。

## 1. 项目定位

Lora 是一个面向 Agent 自优化的本地运行框架。它不是单纯的聊天入口，而是围绕一次 Agent 执行建立可复现、可回放、可评估、可分析的闭环：

```text
case.yaml / chat input
  -> CLI 解析参数和配置
  -> SessionManager 创建或加载 session
  -> CaseManager 加载 case 并准备 workspace
  -> AgentRuntimeAdapter 驱动 Agent 执行
  -> LoraAgent 组合 prompt、调用模型和工具
  -> ToolInterceptor 记录工具调用
  -> EventStore 记录完整事件流
  -> Evaluator 生成 metrics/verdict
  -> analyze/optimize 输出失败归因
```

核心设计原则：

- `session_id` 表示一段可恢复的 Agent 上下文。
- `case_run_id` 表示一次具体执行的证据索引。
- `events.jsonl` 是事实来源，`messages.jsonl`、`tool_calls.jsonl`、`tool_results.jsonl`、`file_events.jsonl` 是投影。
- runtime 负责保留部分失败轨迹，evaluation 负责判定，analysis 负责归因。
- 所有路径在 schema 层尽量规范化为绝对路径。

## 2. 目录结构

```text
src/lora/
  __init__.py                 包级导出
  __main__.py                 python -m lora 入口
  cli.py                      CLI 编排层
  config.py                   配置加载和 YAML 子集解析
  schema/
    __init__.py               schema 导出
    models.py                 公共 dataclass 模型
  session.py                  session 和 case run 生命周期
  case.py                     case 加载、校验、workspace 准备
  runtime.py                  Agent 统一运行适配器
  agent.py                    默认 LoraAgent、prompt、工具注册
  tools.py                    工具拦截、文件读取去重、文件状态
  trace.py                    事件存储和 JSONL 投影
  evaluation.py               deterministic oracle 和指标

tests/
  unit/                       单元测试，覆盖 schema/config/session/case/runtime/tools/trace/evaluation
  scenario/                   CLI 与 trace 端到端场景

examples/
  react_agent_demo.py         pygent + DeepSeek ReAct demo

doc_design/
  development-guide.md        本文
  *.md                        已有架构设计文档
```

运行时会产生两套 session 目录：

```text
.lora/sessions/{session_id}/...
sessions/{session_id}/session.json
```

`.lora/sessions` 是 Lora 的结构化运行证据目录；`sessions` 用于兼容 pygent 风格的 session 落盘。

## 3. 关键运行产物

一次 case run 的主目录：

```text
.lora/sessions/{session_id}/cases/{case_id}/runs/{case_run_id}/
  case.yaml
  run_config.json
  run_metadata.json
  events.jsonl
  messages.jsonl
  tool_calls.jsonl
  tool_results.jsonl
  file_events.jsonl
  result.json
  metrics.json
  verdict.json
  analysis.json
  workspace/before_hashes.json
```

常见文件职责：

| 文件 | 生产者 | 说明 |
| --- | --- | --- |
| `session.json` | `SessionManager.save/create` | 可恢复的 Agent history 和 metadata |
| `metadata.json` | `SessionManager.create` | session 静态元信息 |
| `logs/session-events.jsonl` | `SessionManager` | session 级生命周期事件 |
| `run_config.json` | `SessionManager.start_case_run` | 本次 run 的配置快照 |
| `run_metadata.json` | `SessionManager.start_case_run/finish_case_run` | run 状态、开始和结束时间 |
| `events.jsonl` | `EventStore` | append-only 完整事件流 |
| `messages.jsonl` | `EventStore` | conversation 事件投影 |
| `tool_calls.jsonl` | `EventStore` | `tool.call` 事件投影 |
| `tool_results.jsonl` | `EventStore` | `tool.result` 事件投影 |
| `file_events.jsonl` | `EventStore` | `file.*` 事件投影 |
| `metrics.json` | `Evaluator` | 指标汇总 |
| `verdict.json` | `Evaluator` | pass/fail/error 判定与失败详情 |
| `analysis.json` | CLI analyze | 规则化 root cause |

## 4. CLI 调用链

入口在 `src/lora/__main__.py`：

```python
from .cli import main
raise SystemExit(main())
```

`src/lora/cli.py` 是最上层编排，不承载底层业务逻辑，只负责：

1. 构建 argparse 命令。
2. 调用 `load_run_config` 合并配置。
3. 创建 `SessionManager`、`CaseManager`、`AgentRuntimeAdapter`、`Evaluator`。
4. 将结果以 JSON 输出。
5. 在 CLI 边界捕获异常，返回退出码 `2`。

### 4.1 全局参数

| 参数 | 作用 |
| --- | --- |
| `--workspace-root` | 指定 workspace，默认当前目录或 `LORA_WORKSPACE_ROOT` |
| `--config` | 指定 `lora.yaml` |
| `--agent` | 选择 `lora.yaml` 中的 agent profile alias |
| `--model` | 覆盖模型配置 |
| `--max-steps` | 覆盖 Agent 最大循环步数 |

### 4.2 session 命令

```bash
lora session create --case <case_id> [--mode e2e]
lora session show <session_id>
lora session resume <session_id>
```

调用关系：

```text
_session_create
  -> _manager
  -> load_run_config
  -> SessionManager.create
  -> SessionRef.to_dict

_session_show / resume
  -> _manager
  -> SessionManager.show
```

### 4.3 case 命令

```bash
lora case run <case_file> [--session <session_id>]
lora case analyze <session_id> <case_run_id>
lora case replay <session_id> <case_run_id>
```

`case run` 调用链：

```text
_case_run
  -> load_run_config(case_file/session/model/max_steps)
  -> SessionManager(config)
  -> CaseManager(workspace_root).load(case_file)
  -> _load_case_session 支持 case.session.mode=new/resume/shared/fork
  -> SessionManager.start_case_run
  -> copy case.yaml to run_dir
  -> CaseManager.prepare_workspace
  -> AgentRuntimeAdapter.run_case
  -> Evaluator.evaluate
  -> write result.json
  -> SessionManager.finish_case_run
```

`case replay` 调用链：

```text
_case_replay
  -> _find_case_run
  -> EventStore(ref).list_by_run
  -> event.to_dict
```

`case analyze` 调用链：

```text
_case_analyze
  -> _find_case_run
  -> read verdict.json or re-run Evaluator
  -> EventStore.list_by_run
  -> _root_causes
  -> write analysis.json
  -> EventStore.append("analysis.created")
```

### 4.4 optimize 命令

```bash
lora optimize <case_file>
```

调用链：

```text
_optimize
  -> _case_run
  -> if run.status == "passed": return analysis=None
  -> else _case_analyze
```

当前 optimize 是最小闭环：run + evaluate + rule-based analyze。还没有自动生成测试和自动修复。

### 4.5 chat 命令

```bash
lora chat
lora chat --message "hello"
lora chat --session <session_id> --message "continue"
lora chat --new
```

调用链：

```text
_chat
  -> load_run_config
  -> SessionManager(config)
  -> resolve session_id from --session/config or create chat session
  -> SessionManager.load
  -> SessionManager.start_case_run(session_id, "chat")
  -> EventStore.append("chat.started")
  -> AgentRuntimeAdapter.run_turn
  -> EventStore.append("chat.finished")
  -> SessionManager.finish_case_run
```

交互模式会循环读取 stdin，每个非空输入生成一个 `turn-{index:04d}`。

## 5. 配置模块 `config.py`

### 5.1 `load_run_config(...) -> RunConfig`

签名：

```python
def load_run_config(
    *,
    workspace_root: str | Path | None = None,
    config_file: str | Path | None = None,
    session_id: str | None = None,
    case_file: str | Path | None = None,
    model: str | None = None,
    agent_alias: str | None = None,
    max_steps: int | None = None,
) -> RunConfig
```

职责：

- 确定 `workspace_root`：参数优先，其次 `LORA_WORKSPACE_ROOT`，最后 `Path.cwd()`。
- 读取 `lora.yaml` 或指定 `config_file`。
- 确定 `lora_root`：配置 `lora_root` 优先，其次 `LORA_ROOT`，默认 `.lora`。
- 确定 `session_id`：参数优先，其次 `LORA_SESSION_ID`，最后配置 `session_id`。
- 确定 agent profile：`agent_alias` 参数优先，其次 `agent.default_alias`，最后内置 `default`。
- 确定 `model`：参数优先，其次选中 profile 的 `model_request.model_name`，再兼容 `LORA_MODEL`、`DEEPSEEK_MODEL`、配置 `model` 或 `runtime.model`。
- 确定 API key：`model_request.api_key_env` 指向的环境变量优先，其次 `model_request.api_key`，最后兼容 `DEEPSEEK_API_KEY`。原始 key 只保存在非持久化的 `ResolvedAgentConfig` 中。
- 确定 `max_steps`：参数优先，其次 `LORA_MAX_STEPS`，然后配置 `max_steps` 或 `runtime.max_steps`，默认 `-1`，表示不按步数主动截断，直到模型不再请求工具。
- 返回 `RunConfig`，由 schema 层做路径绝对化和合法性检查。

注意：

- 当前 YAML 解析器是项目内实现的子集解析器，不支持完整 YAML 特性。
- `case_file` 只在参数非空时写入 `RunConfig.case_file`。

### 5.2 Agent 管理配置扩展

当前实现仍只有默认运行时 agent 类 `LoraAgent`，但已经支持通过 `--agent` 和 `lora.yaml` 中的 agent profile 选择模型请求配置。`load_run_config()` 会解析 `agent.default_alias`、`agents[].alias` 和 `agents[].model_request`，并把安全元数据落到 `RunConfig`。

推荐 `lora.yaml` 结构：

```yaml
agent:
  default_alias: dev

agents:
  - alias: dev
    model_request:
      api_key_env: DEEPSEEK_API_KEY
      api_key: ""
      model_name: deepseek-v4-flash
  - alias: fast-check
    model_request:
      api_key_env: DEEPSEEK_API_KEY
      model_name: deepseek-v4-flash
```

字段语义：

| 字段 | 说明 |
| --- | --- |
| `agent.default_alias` | 没有通过 CLI 显式指定时使用的 agent 别名 |
| `agents[].alias` | agent profile 的稳定别名，必须非空且唯一 |
| `agents[].model_request.api_key_env` | API key 来源环境变量，推荐优先使用 |
| `agents[].model_request.api_key` | 已废弃的明文 API key 字段，仅保留兼容 |
| 用户级凭证文件 `~/.lora/credentials.env` | 推荐的日常密钥存放位置，见 `doc/api-key-management.md` |
| `agents[].model_request.model_name` | 发起模型请求时使用的模型名称 |

解析规则：

1. 先确定 agent alias：CLI 参数优先，其次 `agent.default_alias`，最后内置默认 alias。
2. 根据 alias 找到 `agents[]` 中的 profile；找不到应在创建 session/run 前报错。
3. `--model` 继续作为最高优先级模型覆盖，其次使用 `model_request.model_name`，再兼容 `LORA_MODEL`、`DEEPSEEK_MODEL` 和默认模型。
4. API key 优先读取 `model_request.api_key_env` 指向的环境变量；为空时才回退到 `model_request.api_key`；最后兼容 `DEEPSEEK_API_KEY`。
5. `run_config.json` 和事件 payload 只允许记录 `agent_alias`、`model_name`、`api_key_source` 等脱敏元数据，禁止记录原始 API key。

建议新增内部解析结果，供 `AgentRuntimeAdapter` 和 `LoraAgent` 使用：

```python
class ResolvedAgentConfig:
    alias: str
    model_name: str
    api_key: str | None
    api_key_source: str | None
```

如果把 alias 加入 `RunConfig`，它可以落盘；如果把 API key 放入解析结果，必须保持非持久化。

### 5.3 `load_mapping_file(path) -> dict[str, Any]`

读取 UTF-8 文本并调用 `_parse_yaml_subset`。主要用于 `lora.yaml` 和 `case.yaml`。

### 5.4 YAML 子集解析方法

| 方法 | 职责 |
| --- | --- |
| `_read_config(path)` | 安全读取配置文件，缺失时返回 `{}`，读失败包装为 `ValueError` |
| `_dig(data, dotted_key)` | 按点号路径读取嵌套配置，如 `runtime.model` |
| `_parse_yaml_subset(text)` | 去注释、去空行，解析顶层 mapping |
| `_parse_block(lines, index, indent)` | 根据当前行判断解析 map 或 list |
| `_parse_map(lines, index, indent)` | 解析相同缩进层级的 `key: value` 或嵌套块 |
| `_parse_list(lines, index, indent)` | 解析 `- item` 列表，支持列表项为 scalar 或 mapping |
| `_split_key_value(text)` | 拆分并校验 `key: value` |
| `_indent(line)` | 计算前导空格数 |
| `_parse_scalar(value)` | 将 `true/false/null/int/float/quoted string` 转成 Python 值 |

开发注意：

- 这个解析器不支持多行字符串、锚点、复杂引号转义、inline list/map。
- 如果 case schema 复杂化，优先引入标准 YAML 库，而不是继续扩展大量边界条件。

## 6. 公共模型 `schema/models.py`

schema 是跨模块契约层。除 CLI 外，各模块应尽量通过这些 dataclass 传递结构化数据。

### 6.1 辅助函数

| 方法 | 职责 |
| --- | --- |
| `_abs_path(value)` | `expanduser().resolve()`，返回绝对路径字符串 |
| `_require(value, field_name)` | 校验非空字符串，否则抛 `ValueError` |

### 6.2 `RunConfig`

字段：

```python
workspace_root: str
lora_root: str
session_id: str | None = None
case_file: str | None = None
model: str | None = None
max_steps: int = -1
agent_alias: str = "default"
model_name: str | None = None
api_key_source: str = "missing"
base_url: str | None = None
resolved_agent: ResolvedAgentConfig | None = None
user_identity: str = "default"
cli_bash_presets: list[BashCliPreset] = []
```

方法：

- `__post_init__`：规范化 `workspace_root`、`lora_root`、`case_file`；校验 `max_steps == -1` 或 `max_steps > 0`。
- `to_dict()`：返回 `asdict(self)`，但会移除非持久化的 `resolved_agent`，避免原始 API key 落盘。
- `from_dict(data)`：用 dict 反序列化，并忽略传入的 `resolved_agent`。

使用位置：

- `config.load_run_config` 生产。
- `SessionManager` 持有。
- `AgentRuntimeAdapter`、`LoraAgent` 使用 `model/max_steps/workspace_root`。
- `run_config.json` 持久化。

### 6.3 `SessionRef`

字段：

```python
session_id: str
session_dir: str
workspace_root: str
```

方法：

- `__post_init__`：校验 `session_id`，规范化路径。
- `to_dict()` / `from_dict(data)`：序列化和反序列化。

使用位置：

- `SessionManager.create`、`SessionManager.fork` 返回。
- CLI 输出。

### 6.4 `CaseRunRef`

字段：

```python
session_id: str
case_id: str
case_run_id: str
run_dir: str
```

方法：

- `__post_init__`：校验三个 id，规范化 `run_dir`。
- `to_dict()` / `from_dict(data)`。

使用位置：

- `SessionManager.start_case_run` 返回。
- `EventStore` 初始化。
- `ToolContext`、`AgentRuntimeAdapter`、`Evaluator`、`CaseManager.prepare_workspace` 依赖。

### 6.5 `CaseRunResult`

字段：

```python
session_id: str
case_id: str
case_run_id: str
status: Literal["passed", "failed", "error", "skipped"]
final_answer: str = ""
error: str | None = None
event_count: int = 0
message_count: int = 0
```

方法：

- `__post_init__`：校验 id 和 status 枚举。
- `to_dict()` / `from_dict(data)`。

使用位置：

- `AgentRuntimeAdapter.run_case` 返回。
- CLI `_case_run` 写入 `result.json`。

### 6.6 `WorkspaceRef`

字段：

```python
workspace_root: str
case_run_id: str
baseline_path: str | None = None
```

方法：

- `__post_init__`：规范化路径，校验 `case_run_id`。
- `to_dict()`。

使用位置：

- `CaseManager.prepare_workspace` 返回，表示 workspace 准备和 baseline 文件位置。

### 6.7 `EvaluationResult`

字段：

```python
status: Literal["passed", "failed", "error"]
metrics: dict[str, Any] = {}
verdict: dict[str, Any] = {}
```

方法：

- `__post_init__`：校验 status、metrics、verdict 类型。
- `to_dict()`。

使用位置：

- `Evaluator.evaluate` 返回。
- CLI 根据 evaluation 覆盖非 error 的 runtime status。

### 6.8 `ContextEvent`

字段：

```python
id: str
session_id: str
case_id: str | None
case_run_id: str | None
turn_id: str | None
type: str
timestamp: str
actor: Literal["user", "assistant", "tool", "system"]
payload: dict[str, Any] = {}
```

方法：

- `__post_init__`：校验 id、session_id、type、timestamp、actor、payload。
- `to_dict()` / `from_dict(data)`。

使用位置：

- `EventStore.append/append_event/list_events`。
- 所有 trace 回放和投影。

事件命名约定：

- conversation：`conversation.user_message`、`conversation.assistant_message`、`conversation.tool_message`
- model：`model.request`、`model.response`
- tool：`tool.call`、`tool.result`
- file：`file.read`、`file.write`、`file.edit`、`file.delete`
- context：`context.projection_created`、`context.checkpoint`
- runtime：`runtime.error`
- case：`case.started`、`case.finished`
- prompt：`prompt.rendered`
- analysis/test/repair/regression：`analysis.created`、`test.generated`、`repair.*`、`regression.*`

`trace.py` 中的 `DESIGN_EVENT_TYPES` 对齐设计文档的必备事件清单，`LORA_EVENT_TYPES` 额外包含 chat 和 runtime error 等项目内事件。

### 6.9 `CaseDefinition`

字段：

```python
id: str
title: str
type: str
session: dict[str, Any] = {}
workspace: dict[str, Any] = {}
input: dict[str, Any] = {}
expect: dict[str, Any] = {}
metrics: dict[str, Any] = {}
```

方法：

- `__post_init__`：校验 `id/title/type` 和所有 dict section。
- `to_dict()`。
- `from_dict(data)`：提供默认 `title=id`、`type=e2e`，并复制各 section。

使用位置：

- `CaseManager.load` 生产。
- `AgentRuntimeAdapter.run_case` 读取 input。
- `Evaluator.evaluate` 读取 expect/metrics。

### 6.10 `SessionSpec`

字段：

```python
case_id: str
mode: str = "new"
session_id: str | None = None
source_session_id: str | None = None
```

方法：

- `__post_init__`：校验 `case_id` 和 `mode in {"new", "resume", "fork", "shared"}`。

使用位置：

- `SessionManager.load_or_create`。

### 6.11 `AgentSession`

字段：

```python
session_id: str
workspace_root: str
session_dir: str
created_at: str
updated_at: str
system_prompt: str = ""
history: list[dict[str, Any]] = []
metadata: dict[str, Any] = {}
```

方法：

- `__post_init__`：校验 `session_id`，规范化路径。
- `to_dict()`：额外添加 `version: "1.0"`。
- `from_dict(data)`：兼容缺失 `session_dir/system_prompt/history/metadata`。

使用位置：

- `SessionManager.create/load/save`。
- `RuntimeContext` 包装。
- 运行结束后持久化 history 和 metadata。

## 7. Session 模块 `session.py`

`SessionManager` 是 session 和 run 的生命周期管理器。它只操作本地文件系统，不直接运行 Agent。

### 7.1 初始化

```python
manager = SessionManager(config)
```

字段：

- `config`: `RunConfig`
- `workspace_root`: `Path(config.workspace_root)`
- `lora_root`: `Path(config.lora_root)`
- `sessions_root`: `{lora_root}/sessions`

### 7.2 `create(case_id, mode="e2e") -> SessionRef`

职责：

- 生成 session id：`{mode}-{slug(case_id)}-{yyyyMMdd-HHmmss}-{digest}`。
- 创建目录：`context/`、`state/`、`logs/`、`cases/`。
- 写 `.lora/sessions/{session_id}/session.json`。
- 写 `.lora/sessions/{session_id}/metadata.json`。
- 写兼容路径 `sessions/{session_id}/session.json`。
- 返回 `SessionRef`。

失败条件：

- session 目录已存在时 `mkdir(exist_ok=False)` 会失败。

### 7.3 `load(session_id) -> AgentSession`

职责：

- 定位 `.lora/sessions/{session_id}/session.json`。
- 文件不存在则抛 `FileNotFoundError`。
- 读取 JSON，并强制补入当前 `session_dir`。
- 返回 `AgentSession`。

### 7.4 `load_or_create(spec: SessionSpec) -> AgentSession`

行为：

- `resume/shared`：必须提供 `spec.session_id`，直接 `load`。
- `fork`：必须提供 `spec.source_session_id`，先 `fork` 再 `load`。
- `new`：创建新 session 后加载。

### 7.5 `fork(source_session_id) -> SessionRef`

职责：

- 校验源 session 目录存在。
- 使用源 `metadata.json` 的 `case_id` 创建新 fork session。
- 复制源 session 的 `session.json`、`context/`、`state/`。
- 修正新 session 的 `session_id/session_dir/updated_at`。
- 在 metadata 中写入 `forked_from`。

注意：

- 当前没有复制 `cases/` 和 `logs/`，fork 只继承上下文和状态。

### 7.6 `start_case_run(session_id, case_id, run_config=None) -> CaseRunRef`

职责：

- 确认 session 可加载。
- 生成 `case_run_id`：`run-{yyyyMMdd-HHmmss-ffffff}-{digest}`。
- 创建 run 目录：`.lora/sessions/{session_id}/cases/{case_id}/runs/{case_run_id}`。
- 写 `run_config.json`。
- 写 `run_metadata.json`，初始 `status=running`。
- 写 session 级事件 `case.started`。
- 返回 `CaseRunRef`。

### 7.7 `finish_case_run(case_run_ref, status) -> None`

职责：

- 校验 status 属于 `passed/failed/error/skipped`。
- 更新 `run_metadata.json` 的 `status/finished_at`。
- 更新 session `updated_at` 和 metadata：
  - `active_case_id`
  - `last_case_run_id`
  - `last_case_run_status`
- 保存 session。
- 写 session 级事件 `case.finished`。

### 7.8 `show(session_id) -> dict[str, Any]`

返回：

```python
{"session": session.to_dict(), "metadata": metadata}
```

### 7.9 `save(session) -> None`

职责：

- 更新时间。
- 调用 `_save_session` 同步写 `.lora/.../session.json` 和 `sessions/.../session.json`。

### 7.10 内部方法

| 方法 | 职责 |
| --- | --- |
| `_save_session(session)` | 写两个 session 持久化位置 |
| `_session_dir(session_id)` | 返回 `.lora/sessions/{session_id}` |
| `_pygent_session_path(session_id)` | 返回 `workspace_root/sessions/{session_id}/session.json` |
| `_new_session_id(case_id, mode)` | 基于时间和 hash 生成 session id |
| `_new_case_run_id(session_id, case_id)` | 基于时间和 hash 生成 run id |
| `_append_session_event(session_id, event_type, payload)` | 写 `logs/session-events.jsonl` |
| `_write_json(path, data)` | 创建父目录并格式化写 JSON |
| `_read_json(path)` | 读取 JSON |
| `_now()` | 返回 UTC ISO 时间 |
| `_slug(value)` | 将 case id 转成 URL/path 友好的小写短名 |

开发注意：

- 不要绕过 `start_case_run/finish_case_run` 手工创建 run，否则 metadata 和 session event 会缺失。
- 对 session history 的修改应通过 `SessionManager.save` 落盘。

## 8. Case 模块 `case.py`

`CaseManager` 负责将 YAML case 变成 `CaseDefinition`，并为 run 准备 workspace。

### 8.1 初始化

```python
case_manager = CaseManager(workspace_root)
```

`workspace_root` 会被 `expanduser().resolve()`。

### 8.2 `load(path) -> CaseDefinition`

调用链：

```text
load
  -> Path(path).resolve
  -> load_mapping_file
  -> CaseDefinition.from_dict
  -> validate
```

职责：

- 读取 case YAML。
- 应用 schema 默认值。
- 做业务校验。
- 返回 `CaseDefinition`。

### 8.3 `validate(case) -> None`

校验规则：

- `input` 必须定义 `messages`、`content` 或 `prompt`。
- 如果存在 `input.messages`：
  - 必须是非空 list。
  - 每项必须是 mapping。
  - `role` 只能是 `user` 或 `assistant`。
  - 必须有 `content`。
- `expect.tool_calls.required` 中每项必须有 `name`。
- `expect.files.unchanged` 如果存在，必须是 list，且每个路径必须解析在 `workspace_root` 内。

### 8.4 `prepare_workspace(case, case_run_ref) -> WorkspaceRef`

职责：

- 读取 `case.workspace.setup`，默认空 list。
- 支持 `copy_fixture`、`write_file`、`mkdir`、`delete_path`、`run_command` setup step。
- 执行 workspace setup，并把动作记录到 `workspace/setup_actions.jsonl`。
- 对 `expect.files.unchanged` 中的文件写入 baseline hash。
- 返回 `WorkspaceRef`。

支持的 setup：

```yaml
workspace:
  setup:
    - type: copy_fixture
      from: fixtures/case-a
      to: work/case-a
    - type: write_file
      path: work/input.txt
      content: hello
    - type: mkdir
      path: work/output
    - type: delete_path
      path: work/stale.txt
```

所有 workspace setup 路径和 `expect.files.unchanged` 路径都会通过 workspace 安全解析：相对路径以 `workspace_root` 为基准，绝对路径必须仍位于 `workspace_root` 内；空路径或 `..`/绝对路径逃逸会在 agent 执行前报 `ValueError`。如果未来需要外部只读 fixtures，应增加显式 allowlist，不要默认允许。

### 8.5 `case_hash(case) -> str`

将 `case.to_dict()` 按 key 排序序列化为 JSON，并返回 SHA-256。用于未来 regression、缓存、稳定标识。

### 8.6 内部方法

| 方法 | 职责 |
| --- | --- |
| `_copy_fixture(step)` | 将 `from` 拷贝到 `to`，目录会先删除目标再复制 |
| `_write_baseline(case, case_run_ref)` | 写 `workspace/before_hashes.json` |
| `_required_tools(case)` | 返回 `expect.tool_calls.required` |
| `_resolve_workspace_path(root, value, field_name=...)` | 将路径解析到 workspace 下，并拒绝逃逸到 `workspace_root` 外 |
| `_resolve_under_root(root, value)` | 兼容包装，内部委托 `_resolve_workspace_path` |
| `_file_snapshot(path)` | 返回 `{exists, content_hash, size}` |

开发注意：

- 新增 workspace setup 类型时，只扩展 `prepare_workspace` 和测试，不要把准备逻辑放进 CLI。
- 新增 workspace setup 类型必须复用 `_resolve_workspace_path`，并在错误信息里保留字段名。

## 9. Trace 模块 `trace.py`

`EventStore` 是 case run 的事实存储。它写入主事件流，并根据事件类型同步写投影文件。

### 9.1 初始化

```python
store = EventStore(case_run_ref)
```

初始化路径：

- `events_path = run_dir/events.jsonl`
- `messages_path = run_dir/messages.jsonl`
- `tool_calls_path = run_dir/tool_calls.jsonl`
- `tool_results_path = run_dir/tool_results.jsonl`
- `file_events_path = run_dir/file_events.jsonl`

### 9.2 `append(event, *, actor=None, payload=None, turn_id=None) -> str`

支持两种调用：

```python
store.append(context_event)
store.append("tool.call", actor="assistant", payload={...}, turn_id="turn-0001")
```

职责：

- 将字符串事件转换为 `ContextEvent`。
- 校验 `ContextEvent` 的 run scope。
- 写入事件流和相关投影。
- 返回 event id。

### 9.3 `append_event(event) -> str`

`append` 的显式别名，只接受 `ContextEvent`。

### 9.4 `append_error(error, event_type="error", actor="system", payload=None, turn_id=None) -> str`

职责：

- 将异常或字符串转成标准 error payload。
- 写入指定事件类型，默认 `error`。

payload 包含：

```python
{"error": "...", "error_type": "..."}
```

### 9.5 查询方法

| 方法 | 返回 |
| --- | --- |
| `list_by_run(session_id=None, case_run_id=None)` | 当前或指定 run 的事件 |
| `list_by_session(session_id=None)` | 当前或指定 session 的事件 |
| `list_by_case(case_id=None)` | 当前或指定 case 的事件 |
| `list_by_turn(turn_id)` | 指定 turn 的事件 |
| `list_events()` | 当前 `events.jsonl` 全部事件 |
| `iter_jsonl(path)` | 静态生成器，逐行读取 JSONL；缺失文件返回空迭代 |

### 9.6 内部写入和投影

| 方法 | 职责 |
| --- | --- |
| `_append_event(event)` | 写主事件，并根据 type 写投影 |
| `_coerce_event(...)` | 字符串事件转 `ContextEvent` |
| `_validate_event_scope(event)` | 确认 event 的 session/case/run 与当前 store 一致 |
| `_append_jsonl(path, data)` | append 写 JSONL |
| `_tool_call_record(event)` | 从 `tool.call` 生成投影行 |
| `_tool_result_record(event)` | 从 `tool.result` 生成投影行 |
| `_file_event_record(event)` | 从 `file.*` 生成投影行 |

投影规则：

- `event.type.startswith("conversation.")` -> `messages.jsonl`
- `event.type == "tool.call"` -> `tool_calls.jsonl`
- `event.type == "tool.result"` -> `tool_results.jsonl`
- `event.type.startswith("file.")` -> `file_events.jsonl`

开发注意：

- 新事件类型应优先写入 `events.jsonl`，投影只是加速读取和分析。
- append-only 是当前系统可回放性的基础，不要覆写已有 JSONL。

## 10. Tools 模块 `tools.py`

该模块负责工具调用包裹、文件读取去重和文件状态维护。

### 10.1 常量

| 常量 | 用途 |
| --- | --- |
| `FILE_UNCHANGED_STUB` | 完全重复读取同一文件版本时返回的固定提示 |
| `FILE_RANGE_CONTAINED_STUB` | 请求范围已被此前读取覆盖时返回 |
| `FILE_RANGE_OVERLAP_STUB` | 请求范围部分重叠时返回 |

### 10.2 `ReadRange`

字段：

```python
unit: Literal["line", "full"] = "full"
start: int = 1
end: int | Literal["EOF"] = "EOF"
```

方法：

- `covers(other)`：当前 range 是否完全覆盖另一个 range。`full` 覆盖所有。
- `overlaps(other)`：两个 range 是否重叠。只要任一为 `full` 就视为重叠。

### 10.3 `ReadDedupDecision`

字段：

```python
action: Literal["read", "stub", "partial"]
reason: Literal["none", "exact", "contained", "overlap"]
content: str | None = None
previous_event_id: str | None = None
```

表示一次读取是否应该真实读取、返回 stub，或未来支持只返回未读部分。

### 10.4 `ToolContext`

字段：

```python
case_run_ref: CaseRunRef
turn_id: str | None = None
```

用于把工具调用关联到当前 run 和 turn。

### 10.5 `ToolResult`

字段：

```python
status: Literal["success", "error", "stubbed", "partial"]
result: Any = None
error: str | None = None
tool_call_id: str | None = None
```

方法：

- `to_dict()`：序列化工具结果。

### 10.6 `FileStateTracker`

初始化：

```python
tracker = FileStateTracker(session_state_dir)
```

路径：

- `file_state_path = session_state_dir/file_state.json`
- `read_state_path = session_state_dir/read_state.json`

#### `record_read(path, content_hash, read_range, event_id) -> None`

职责：

- 将路径规范化为绝对路径。
- 在 `read_state.json` 中记录相同 content hash 下的读取 range。
- 在 `file_state.json` 中记录文件存在、hash、最后读取事件和读取 ranges。

#### `should_stub_read(path, content_hash, read_range, dedup_level="contained") -> ReadDedupDecision`

行为：

- 只比较相同路径、相同 `content_hash` 的历史读取。
- exact：同 unit/start/end，返回 `stub/exact`。
- contained：历史 range 覆盖当前 range，返回 `stub/contained`。
- overlap：当 `dedup_level == "overlap"` 且范围重叠，返回 `partial/overlap`。
- 否则返回 `read/none`。

#### `read_text_file(path, *, offset=None, limit=None, dedup_level="contained", event_store=None, turn_id=None) -> dict`

调用链：

```text
read_text_file
  -> read full text
  -> sha256 content
  -> _line_range
  -> should_stub_read
  -> if stub: return stub payload
  -> _select_lines
  -> EventStore.append("file.read") if store exists
  -> record_read
  -> return content/hash/range
```

返回示例：

```python
{"status": "success", "content": "...", "content_hash": "...", "range": {...}}
{"status": "stubbed", "content": "...", "dedup": "contained"}
```

注意：

- 即使只读一个范围，当前实现也先读取完整文件计算 hash。
- `dedup_level="contained"` 不会返回 partial，只会对被覆盖的范围 stub。

#### 内部方法

| 方法 | 职责 |
| --- | --- |
| `_read_json(path)` | 文件不存在返回 `{}` |
| `_write_json(path, data)` | 创建父目录并格式化写 JSON |

### 10.7 `ToolInterceptor`

初始化：

```python
interceptor = ToolInterceptor(EventStore(case_run_ref))
```

默认 `LoraAgent` 会使用带文件效果跟踪的形式：

```python
interceptor = ToolInterceptor(
    EventStore(case_run_ref),
    workspace_root=workspace_root,
    track_file_effects=True,
)
```

#### `call_tool(name, args, ctx, tool) -> ToolResult`

调用链：

```text
call_tool
  -> EventStore.append("tool.call", actor="assistant")
  -> if tracking: snapshot workspace and collect declared file effects
  -> tool(**args)
  -> if tracking: snapshot workspace again, merge declared/observed file effects, append file.* events
  -> on exception: EventStore.append("tool.result", status="error")
  -> on success: infer status from result.status if stubbed/partial
  -> EventStore.append("tool.result", actor="tool")
  -> return ToolResult
```

开发注意：

- 所有模型触发的工具调用都应该经过 `ToolInterceptor`。
- 真正的工具函数只负责业务结果，记录、错误包装、trace 写入都在 interceptor 做。

### 10.8 文件效果跟踪方案

背景：

- 当前默认 `LoraAgent` 注册的是 pygent 的 `bash/read/write/edit/glob/grep` 白名单工具。
- `read/write/edit` 的工具名和参数可以表达文件意图，但 `bash` 也可能通过 `cat`、`echo >`、`rm`、`python -c`、`sed -i` 等命令读取或修改文件。
- 因此文件影响不能只从工具名推断；需要把 workspace 作为被观测对象，对每次工具调用产生的文件净效果做事实记录。

#### 10.8.1 目标

第一阶段目标：

- 对每次工具调用完整跟踪 workspace 内的文件净变化：新增、编辑、删除。
- 同一次工具调用中，同一路径最终只产生一条 file effect 事件。
- 语义明确的工具参数和 snapshot diff 发现同一路径变化时，合并成一条事件，而不是重复写入。
- `file.read` 仍以明确读工具和 `FileStateTracker.read_text_file()` 为主；对 `bash` 读命令只做最佳努力解析，不承诺完整。

非目标：

- 不记录同一次工具调用中 A -> B -> A 这种最终无净变化的中间过程。
- 不在第一阶段实现 OS 级文件访问审计，例如 strace、eBPF、ETW 或 USN Journal。
- 不跟踪 workspace 外文件，除非后续显式引入受控沙箱或审计后端。

#### 10.8.2 新增模型

建议在 `tools.py` 增加内部 dataclass：

```python
@dataclass(slots=True)
class FileSnapshot:
    path: str
    exists: bool
    kind: Literal["file", "dir", "other", "missing"]
    size: int | None = None
    mtime_ns: int | None = None
    content_hash: str | None = None


@dataclass(slots=True)
class FileEffect:
    type: Literal["file.read", "file.write", "file.edit", "file.delete"]
    path: str
    tool_call_id: str
    tool_name: str
    detected_by: list[Literal["tool_args", "snapshot_diff", "bash_command_parse"]]
    confidence: Literal["declared", "observed", "inferred"]
    before_hash: str | None = None
    after_hash: str | None = None
    before_exists: bool | None = None
    after_exists: bool | None = None
```

`FileEffect.key()` 使用下面字段生成稳定去重键：

```text
case_run_id + tool_call_id + normalized_path + type + before_hash + after_hash + before_exists + after_exists
```

#### 10.8.3 `FileEffectTracker`

建议新增：

```python
class FileEffectTracker:
    def __init__(self, workspace_root: str | Path, store: EventStore):
        ...

    def snapshot_workspace(self) -> dict[str, FileSnapshot]:
        ...

    def declared_effects(self, tool_name: str, args: dict[str, Any], tool_call_id: str) -> list[FileEffect]:
        ...

    def observed_effects(
        self,
        before: dict[str, FileSnapshot],
        after: dict[str, FileSnapshot],
        *,
        tool_name: str,
        tool_call_id: str,
    ) -> list[FileEffect]:
        ...

    def merge_effects(self, declared: list[FileEffect], observed: list[FileEffect]) -> list[FileEffect]:
        ...

    def append_effects(self, effects: list[FileEffect], *, turn_id: str | None) -> None:
        ...
```

`snapshot_workspace()`：

- 遍历 workspace，跳过 `.git`、`.lora`、`.venv`、`__pycache__`、`.pytest_cache`、`sessions` 等运行和依赖目录。
- 对文件记录 `size`、`mtime_ns`、`content_hash`。
- 后续可优化为先比较 `size/mtime_ns`，有变化时再计算 hash。

`observed_effects()`：

- before 不存在、after 存在：生成 `file.write`。
- before 存在、after 不存在：生成 `file.delete`。
- before/after 都存在但 hash 不同：生成 `file.edit`。
- before/after 都不存在或 hash 相同：不生成事件。

`declared_effects()` 第一阶段只处理明确工具：

- `write`：`file.write` 或 `file.edit` 的声明意图，最终类型以 observed 为准。
- `edit`：`file.edit` 的声明意图。
- `read`：`file.read` 的声明意图。
- `bash`：可选解析 `cat`、`type`、`Get-Content`、`grep` 等常见读命令，标记 `confidence="inferred"`。

`merge_effects()`：

- 以 normalized path 为主键合并 declared 和 observed。
- 同一路径如果有 observed effect，保留 observed 的 type/hash/existence，并把 `detected_by` 合并为 `["tool_args", "snapshot_diff"]`。
- 同一路径只有 declared read，则保留 `file.read`。
- 同一次工具调用内每个 normalized path 最多一条最终写入类 effect。

#### 10.8.4 `ToolInterceptor` 集成

`ToolInterceptor` 增加可选参数：

```python
interceptor = ToolInterceptor(store, workspace_root=config.workspace_root, track_file_effects=True)
```

调用链调整为：

```text
call_tool
  -> append tool.call and get tool_call_id
  -> if tracking enabled: before = FileEffectTracker.snapshot_workspace()
  -> declared = FileEffectTracker.declared_effects(tool_name, args, tool_call_id)
  -> tool(**args)
  -> if tracking enabled: after = FileEffectTracker.snapshot_workspace()
  -> observed = FileEffectTracker.observed_effects(before, after, tool_name, tool_call_id)
  -> effects = FileEffectTracker.merge_effects(declared, observed)
  -> append file effects
  -> append tool.result
  -> return ToolResult
```

异常时也应做 after snapshot 并记录已发生的净变化，因为很多 shell 命令可能部分成功后返回非零状态。

#### 10.8.5 事件 payload

写入 `file.write/file.edit/file.delete/file.read` 时统一 payload：

```json
{
  "path": "...",
  "tool_call_id": "...",
  "tool_name": "bash",
  "detected_by": ["snapshot_diff"],
  "confidence": "observed",
  "before_hash": "...",
  "after_hash": "...",
  "before_exists": true,
  "after_exists": true
}
```

`EventStore` 现有 `file_events.jsonl` 投影可继续使用，不需要新增投影文件。

#### 10.8.6 测试先行

先新增会失败的 UT/ST 作为实现规格：

UT 覆盖 `FileEffectTracker` 的纯逻辑：

- 同一次工具调用内同一路径多次写入，只记录一次最终 `file.write`。
- `write/edit` 声明效果和 snapshot diff 观察效果合并成一条 `file.edit`，`detected_by` 同时包含 `tool_args` 和 `snapshot_diff`。
- 删除文件生成一条 `file.delete`，重复删除或最终无变化不重复。
- 创建后又删除、编辑后又改回原内容，最终无净变化，不记录 file effect。
- 一次工具调用影响多个路径时，每个路径最多一条事件，并保持稳定顺序。
- 声明路径中的 `..`、相对路径和绝对路径先归一化，再和 snapshot diff 合并。
- `.git`、`.lora`、`.venv`、`__pycache__`、`.pytest_cache`、`sessions` 等目录变动不进入 workspace effect。
- workspace 外声明路径拒绝处理，避免把外部文件写进 trace。
- `bash` 常见读命令只生成 `file.read` inferred 事件，不伪装成 observed。
- 同一个 effect key 重复 append 时只写一次，防止重试或合并路径重复落盘。

ST 覆盖 `ToolInterceptor` 集成：

- 通过 `ToolInterceptor.call_tool("bash", ...)` 执行一个模拟 bash 工具，内部创建、编辑、删除文件，最终只在 `file_events.jsonl` 看到净效果。
- 异常工具部分修改文件后抛错，仍记录已经发生的 file effect，并记录 `tool.result status=error`。
- `write` 工具声明路径和实际文件变化合并为单条 `file.edit`，不重复记录。
- 工具修改 workspace 外文件时，不写入 file events。

### 10.9 其他内部方法

| 方法 | 职责 |
| --- | --- |
| `_normalize(path)` | 规范化为绝对路径字符串 |
| `_line_range(content, offset, limit)` | 根据行偏移和限制生成 `ReadRange` |
| `_select_lines(content, read_range)` | 从文本中选择 range 内容 |
| `_end_value(value)` | 将 `EOF` 视为极大值用于比较 |
| `_now()` | UTC ISO 时间 |

## 11. Runtime 模块 `runtime.py`

runtime 的目标是让不同 Agent 实现都能接入统一执行、事件记录和 session 保存流程。

### 11.1 `RuntimeMessage`

字段：

```python
role: str
content: str
type: str | None = None
payload: dict[str, Any] | None = None
```

表示标准化后的 Agent 输出。

### 11.2 `RuntimeContext`

初始化：

```python
context = RuntimeContext(session)
```

字段：

- `session`: `AgentSession`
- `session_id`: `session.session_id`
- `system_prompt`: `session.system_prompt`
- `history`: `session.history`

方法：

- `add_message(message)`：将 dict 或对象标准化后 append 到 history。
- `last_message`：返回最后一条 history，空时返回 `None`。

### 11.3 `EchoAgent`

方法：

```python
async def stream(self, context: RuntimeContext, max_steps: int = -1)
```

行为：

- 找到最后一条 user message。
- yield 一条 assistant message：`Echo: {content}`。

当前默认 `AgentRuntimeAdapter` 实际会创建 `LoraAgent`，但测试里也使用 Echo 风格和自定义 agent 验证适配能力。

### 11.4 `AgentRuntimeAdapter`

初始化：

```python
adapter = AgentRuntimeAdapter(agent=None, config=config, session_manager=manager)
```

行为：

- 如果 `agent is None`，延迟导入并创建 `LoraAgent(config)`。
- 保存 `config` 和 `session_manager`。

#### `run_turn(session, user_input, case_run_ref, turn_id=None) -> dict`

用于 chat 单轮。

调用链：

```text
run_turn
  -> EventStore(case_run_ref)
  -> RuntimeContext(session)
  -> resolve turn_id
  -> _start_agent_run(agent, case_run_ref, turn_id)
  -> context.add_message(user)
  -> store.append("conversation.user_message")
  -> async for raw_output in _stream_agent
       -> _normalize_output
       -> context.add_message
       -> store.append(event_type)
       -> collect assistant final_parts
  -> except: status="error"; store.append("runtime.error")
  -> finally: update session.history/metadata; SessionManager.save
  -> return dict
```

返回字段：

```python
session_id
case_id
case_run_id
turn_id
status
final_answer
error
message_count
```

#### `run_case(session, case, case_run_ref) -> CaseRunResult`

用于 case run。

调用链：

```text
run_case
  -> EventStore.append("case.started")
  -> _start_agent_run(agent, case_run_ref, "turn-0001")
  -> _case_messages(case)
  -> append each user message to context and events
  -> append model.request
  -> _stream_agent(context, latest_user_content)
  -> normalize and record assistant/tool outputs
  -> except: status="error"; append runtime.error
  -> finally:
       session.history = context.history 或 original_history + 本轮 history
       update session.metadata
       session_manager.save
       append model.response
       append case.finished
       append context.checkpoint
  -> count events
  -> return CaseRunResult
```

注意：

- runtime status 只表示执行是否出错；case 断言失败由 `Evaluator` 后续覆盖为 failed。
- 即使 agent 抛异常，partial assistant output 也会保留。
- `case.session.carry_context: false` 时，Agent 本轮看不到旧 history；运行结束后，本轮增量会追加回原 session history。

#### `_stream_agent(context, latest_user_input)`

兼容两类 Agent：

1. 暴露 `stream(context, max_steps=...)` 或 `stream(latest_user_input, max_steps=...)`。
2. 暴露 `run(latest_user_input, max_steps=...)`，可以是 sync 或 async。

返回逻辑：

- async iterator：逐条 yield。
- sync iterator：逐条 yield。
- run 返回值：包装为 assistant message。

### 11.5 Runtime 辅助方法

| 方法 | 职责 |
| --- | --- |
| `_case_messages(case)` | 从 `input.messages` 或 `input.content/prompt` 提取 user messages |
| `_latest_user_content(case)` | 返回最后一条 user content |
| `_normalize_output(output)` | 将 dict、`RuntimeMessage` 或对象转成 `RuntimeMessage` |
| `_message_to_history(message)` | 将输入统一成 history dict |
| `_event_type_for_role(role)` | role 到 conversation event type |
| `_actor_for_role(role)` | role 到 event actor |
| `_value(value)` | 兼容 pygent `.data` 包装 |
| `_stringify(value)` | 将非字符串内容 JSON 化或转字符串 |
| `_start_agent_run(agent, case_run_ref, turn_id)` | 如果 agent 有 `start_run`，执行它 |

开发注意：

- 新 Agent 最少实现 `stream` 或 `run`。
- 如果需要工具、prompt、trace 初始化，推荐实现 `start_run(case_run_ref, turn_id)`。
- Agent 输出的 dict 最好包含 `role/content/type/payload`，否则 runtime 会按 role 默认推导事件类型。

## 12. Agent 模块 `agent.py`

`agent.py` 包含当前默认 Agent、prompt 模块系统和 pygent 工具白名单注册。

### 12.1 `PromptModule`

字段：

```python
id: str
phase: Literal["static", "dynamic"]
type: Literal["system", "project", "runtime", "tool", "memory", "policy"]
cache_scope: Literal["session", "request", "turn", "none"]
order: int
render: Callable[[PromptRenderContext], str | None]
required: bool = False
depends_on: tuple[str, ...] = ()
enabled: Callable[[PromptRenderContext], bool] = _always_enabled
```

属性：

- `version_hash`：基于 `id/phase/type/cache_scope/order/depends_on` 的 SHA-256 hash 字符串。

### 12.2 `PromptRenderContext`

字段：

```python
session_id: str
workspace_root: Path
session_dir: Path
turn_id: str | None
projection: dict[str, Any]
tool_names: list[str]
request_id: str | None = None
request_type: str = "agent_turn"
```

用于 prompt module 渲染。

### 12.3 `PromptRegistry`

初始化时注册默认 system prompt 模块：

| id | phase | type | cache_scope | order | 内容 |
| --- | --- | --- | --- | --- | --- |
| `system.identity` | static | system | session | 10 | Lora 身份和回答语言 |
| `system.tool_policy` | static | policy | session | 20 | 工具调用策略 |
| `system.injection_guard` | static | policy | session | 30 | 非可信内容和 prompt injection 防护 |
| `system.path_policy` | static | policy | session | 35 | workspace、project/user Lora root 和工具路径规则 |
| `system.coding_rules` | static | system | session | 40 | 编码工作规则 |
| `system.output_style` | static | system | session | 50 | 输出风格 |
| `tool.available` | request_system | tool | turn | 120 | 当前实际可用工具 |
| `system.tool_result_reminders` | request_system | system | request | 140 | 工具结果处理提醒 |
| `system.token_budget` | request_system | system | request | 150 | 上下文预算提醒 |

已移除的 prompt modules：

- `runtime.system_reminder`
- `runtime.skill_reminder`
- `runtime.env_info`
- `project.file_status`
- `memory.recent_projection`
- `runtime.tool_result_reminders`
- `runtime.token_budget`

其中 CLI/skill reminder 不再通过 prompt module 渲染；初始内容追加到 user message，新发现内容追加到 tool message，并共用一个 `<system-reminder>` 包装。

方法：

- `resolve()`：可按 `phase/include/exclude/enabled` 过滤模块，并按 `order`、`id` 排序返回。
- `register()` / `replace()` / `upsert()`：注册、替换或插入 prompt module，供示例和后续扩展使用。

### 12.4 `PromptComposer`

初始化：

```python
composer = PromptComposer(registry=None)
```

#### `compose(ctx) -> tuple[str, list[dict[str, Any]]]`

行为：

- 调用 `compose_static()` 渲染 `phase == "static"` 的模块。
- 调用 `compose_request_system()` 渲染 `phase == "request_system"` 的模块。
- 如果存在 request system prompt，直接追加到 static prompt 后面，不插入额外边界 marker。
- 返回真实发送给模型的完整 system prompt 文本和 rendered module 元数据。

#### `compose_static(ctx)` / `compose_request_system(ctx, module_ids=None)`

- `compose_static()` 只渲染 `phase == "static"` 的模块。
- `compose_request_system()` 只渲染 `phase == "request_system"` 的模块，可按 `module_ids` 精确选择。
- 两者都会为 module metadata 记录 input hash、content hash 和 render time。

module metadata 包含：

```python
id
phase
type
order
cache_scope
version_hash
input_hash
content_hash
rendered_at
```

### 12.5 `AgentContextManager`

初始化：

```python
manager = AgentContextManager(session_dir=..., workspace_root=..., store=...)
```

字段：

- `session_dir`
- `workspace_root`
- `store`
- `file_state = FileStateTracker(session_dir / "state")`
- `prompt_composer = PromptComposer()`
- `static_prompt_cache = StaticPromptSessionCache(session_dir, prompt_composer)`

#### `projection(history, limit=8) -> dict`

返回：

```python
{
  "recent_messages": [{"role": ..., "content": first_1200_chars}, ...],
  "file_status": self.file_status(),
}
```

#### `compose_prompt(runtime_context, turn_id, tool_names) -> str`

调用链：

```text
compose_prompt
  -> build_model_request_prompt
  -> return prompt.text
```

`build_model_request_prompt(...)` 是模型请求前的主入口：

```text
build_model_request_prompt
  -> PromptRenderContext
  -> StaticPromptSessionCache.get_or_create
  -> PromptComposer.compose_request_system
  -> join static prompt and request system prompt
  -> runtime_context.system_prompt = prompt.text
  -> runtime_context.session.system_prompt = prompt.text
  -> if store exists: append prompt.rendered
  -> return ModelRequestPrompt
```

`prompt.rendered` payload 包含：

- `module_ids`
- `static_module_ids`
- `request_system_module_ids`
- `dynamic_module_ids`（旧字段占位，当前为空）
- `modules`
- `prompt_hash`
- `static_prompt_hash`
- `request_system_prompt_hash`
- `dynamic_prompt_hash`（旧字段占位，当前为 `None`）
- `static_prompt_created`

`StaticPromptSessionCache` 会把 session 级 static prompt 写入：

```text
.lora/sessions/{session_id}/context/prompts/static_prompt.txt
.lora/sessions/{session_id}/context/prompts/static_prompt.json
```

`EventStore` 收到 `prompt.rendered` 事件时，会把本次模型请求的完整 rendered system prompt 文本写入 run 目录和 session 目录；`session.json.system_prompt` 也保存最新一次真实发送给模型的完整 system prompt：

```text
{run_dir}/rendered_prompts/{turn_id}.txt
{run_dir}/rendered_prompts/{turn_id}.json
.lora/sessions/{session_id}/context/rendered_prompts/{case_run_id}/{turn_id}.txt
.lora/sessions/{session_id}/context/rendered_prompts/{case_run_id}/{turn_id}.json
```

`<system-reminder>` 不写入 static prompt，也不写入 request system prompt。初始 CLI/skill context 追加到首个 user message；工具执行后新发现的 CLI/skill context 追加到对应 tool message。

#### `file_status() -> list[dict]`

读取 `state/file_state.json`，输出：

```python
{"path": ..., "status": "read" | "deleted", "content_hash": ...}
```

### 12.6 默认工具注册

当前 `LoraAgent` 不再内置 `list_files/read_text_file/add_numbers` 三个自定义工具，而是从 `pygent.toolkits` 加载工具集，并只注册白名单工具：

- `bash`
- `read`
- `write`
- `edit`
- `glob`
- `grep`

实现位置：

- `DEFAULT_PYGENT_TOOL_NAMES` 定义白名单。
- `_register_default_tools()` 创建 `FileToolkits(session_id, workspace_root)` 和 `BashToolkits(session_id, workspace_root)`。
- 从 toolkit 的 `get_all_tools()` 中按名称取出白名单工具，并通过 `_register_tool()` 同时注册到 `ToolManager` 和本地 `_tools` dict。

注意：

- 这些工具调用会通过 `ToolInterceptor.call_tool` 记录 `tool.call` 和 `tool.result`。
- `tools.py` 中仍保留 `FileStateTracker.read_text_file()`，用于文件读取去重和 `file.read` 事件记录。默认 `LoraAgent` 的真实工具调用路径会启用 `ToolInterceptor(..., track_file_effects=True)`，因此 pygent 的 `read/write/edit` 工具参数会声明 `file.read/file.write/file.edit`，并与 workspace snapshot diff 合并后写入 `file_events.jsonl`。

### 12.7 `LoraAgent`

初始化：

```python
agent = LoraAgent(config)
```

职责：

- 保存 `RunConfig`。
- 加载 workspace `.env`。
- 读取已解析的 `ResolvedAgentConfig`，并从中取得非持久化 API key；没有传入解析结果时才兼容 `DEEPSEEK_API_KEY`。
- 确定模型：
  - CLI `--model` 覆盖
  - 选中 agent 的 `model_request.model_name`
  - `LORA_MODEL`
  - `DEEPSEEK_MODEL`
  - 配置 `model` 或 `runtime.model`
  - 默认 `deepseek-v4-flash`
- 确定 base URL：选中 agent 的 `model_request.base_url`、`DEEPSEEK_BASE_URL` 或 `https://api.deepseek.com`。
- 如果有 API key，创建 `AsyncRequestsClient`；否则 `llm=None`。
- 初始化工具管理器。
- 当前默认工具来自 `pygent.toolkits.FileToolkits` 和 `pygent.toolkits.BashToolkits`，注册白名单为 `bash/read/write/edit/glob/grep`。

已落地的 agent profile 行为：

- 根据 `agent_alias` 选择 agent profile。
- 将 `model_request.api_key_env` 或 `model_request.api_key` 解析成非持久化 API key。
- 将 `model_request.model_name` 作为 profile 默认模型，并允许 `--model` 覆盖。
- 在 `model.request` 和 `model.response` 事件中记录 `agent_alias` 和 `model_name`，但不记录 API key。
- 缺少 API key 时，错误或 fallback 文案要包含 agent alias，方便定位是哪份配置缺失。

#### `start_run(case_run_ref, turn_id) -> None`

职责：

- 保存当前 run 和 turn。
- 根据 run 目录向上查找 session 目录。
- 创建 `AgentContextManager`。
- 重建 `ToolManager` 和 `_tools`。
- 调用 `_register_default_tools()`，注册 pygent 工具白名单：
  - `bash`
  - `read`
  - `write`
  - `edit`
  - `glob`
  - `grep`

#### `tools_param() -> list[dict]`

将 pygent tool manager 的 OpenAI function schema 包装为：

```python
{"type": "function", "function": function}
```

#### `stream(context, max_steps=-1) -> AsyncIterator[dict]`

调用链：

```text
stream
  -> require start_run already called
  -> AgentContextManager.compose_prompt
  -> if llm is None:
       yield assistant fallback message
       return
  -> BaseContext(system_prompt)
  -> convert runtime history to pygent messages
  -> ToolInterceptor(EventStore, workspace_root=..., track_file_effects=True)
  -> for max_steps:
       stream llm chunks
       collect assistant text
       yield assistant message
       inspect tool_calls from last_message
       if no tool_calls: return
       for each tool_call:
         validate tool name
         ToolInterceptor.call_tool
         add ToolMessage to pygent context
         yield tool message
  -> raise RuntimeError when max_steps exhausted
```

无 API key 时返回固定提示：

```text
Lora agent is wired into chat, but API key is not configured for agent alias 'default'.
```

#### `_register_tool(tool) -> None`

同时注册到 `ToolManager` 和本地 `_tools` dict。

### 12.8 Agent 辅助方法

| 方法 | 职责 |
| --- | --- |
| `_render_file_status(ctx)` | 渲染文件读取状态 prompt section |
| `_render_projection(ctx)` | 渲染最近历史 prompt section |
| `_to_pygent_message(message)` | runtime history dict 转 pygent `UserMessage/AssistantMessage/ToolMessage` |
| `_message_tool_calls(message)` | 兼容 pygent `.data` 结构读取 tool calls |
| `_message_content(message)` | 兼容 pygent `.data` 结构读取 content |
| `_hash_text(text)` | SHA-256 prompt hash |
| `_load_env_file(path)` | 简易 `.env` loader，不覆盖已有环境变量 |
| `_session_dir_for_run(run_dir)` | 从 run_dir 向上查找包含 `session.json` 的 session 根目录 |

开发注意：

- 新工具必须继承 `BaseTool`，并通过 `_register_tool` 注册。
- 工具 `forward` 不要自己写 trace，统一由 `ToolInterceptor` 记录。
- 文件工具必须使用 `_safe_path`，避免模型读取 workspace 外路径。

## 13. Evaluation 模块 `evaluation.py`

`Evaluator` 是 deterministic oracle。它不运行 Agent，只读取 case 和 run 产物判定结果。

### 13.1 `Evaluator.evaluate(case, case_run_ref) -> EvaluationResult`

调用链：

```text
evaluate
  -> EventStore(case_run_ref).list_by_run()
  -> collect runtime.error/error events
  -> _final_answer(events)
  -> _tool_call_names(run_dir)
  -> check expect.answer.contains
  -> check expect.tool_calls.required
  -> _file_failures
  -> check metrics.max_turns
  -> check metrics.max_tool_calls
  -> build metrics
  -> status = error if errors else failed if failures else passed
  -> write metrics.json/verdict.json
  -> return EvaluationResult
```

支持的断言：

```yaml
expect:
  answer:
    contains:
      - token
  tool_calls:
    required:
      - name: read_text_file
  files:
    unchanged:
      - README.md
metrics:
  max_turns: 8
  max_tool_calls: 6
```

metrics 输出：

```python
event_count
message_count
tool_call_count
turn_count
final_answer_length
```

verdict 输出：

```python
status
final_answer
failures
errors
```

### 13.2 内部方法

| 方法 | 职责 |
| --- | --- |
| `_final_answer(events)` | 拼接所有 assistant message content |
| `_tool_call_names(run_dir)` | 从 `tool_calls.jsonl` 提取 tool name 序列 |
| `_file_failures(case, run_dir)` | 对比 baseline 和当前文件快照 |
| `_file_snapshot(path)` | 返回 `{exists, content_hash, size}` |
| `_write_json(path, data)` | 写格式化 JSON |

开发注意：

- `runtime.error` 会让 status 直接变成 `error`。
- evaluation 不应修改 session history。
- 新增 expect 类型时，应同步增加单元测试和场景测试。

## 14. 包导出

`src/lora/__init__.py` 导出：

```python
CaseManager
Evaluator
FileStateTracker
SessionManager
ToolInterceptor
load_run_config
```

`src/lora/schema/__init__.py` 导出：

```python
AgentSession
CaseDefinition
CaseRunRef
CaseRunResult
ContextEvent
EvaluationResult
RunConfig
SessionRef
SessionSpec
WorkspaceRef
```

开发注意：

- 公共 API 新增后，如果希望使用方直接 `from lora import ...` 或 `from lora.schema import ...`，需要同步更新 `__all__`。

## 15. 测试结构和覆盖点

当前测试使用 `unittest`。

### 15.1 单元测试

| 文件 | 覆盖 |
| --- | --- |
| `test_config.py` | 配置合并、环境变量覆盖、YAML 子集解析 |
| `test_schema.py` | 路径规范化、ref round-trip、事件校验、case 默认值 |
| `test_session_manager.py` | 创建/加载 session、多 run、finish metadata、fork |
| `test_case_manager.py` | case 加载校验、hash、fixture copy、baseline |
| `test_runtime_adapter.py` | run_case 事件记录、失败保留、run_turn chat |
| `test_tools.py` | 文件读取去重、hash 变化、工具拦截成功/失败、文件效果跟踪 |
| `test_trace.py` | 事件 append、scope 校验、投影、查询、错误事件 |
| `test_evaluation.py` | answer/tool/file 断言、失败详情 |

### 15.2 场景测试

| 文件 | 覆盖 |
| --- | --- |
| `test_cli_flow.py` | `session create/show`、`case run/replay`、`optimize`、`chat --message` |
| `test_trace_event_store_flow.py` | append-only trace 和所有投影文件 |
| `test_file_effect_tracking_flow.py` | `ToolInterceptor` 文件新增/编辑/删除净效果跟踪 |

### 15.3 推荐测试命令

```powershell
.\.venv\Scripts\python.exe -m unittest discover -s tests
```

如果需要直接跑 CLI：

```powershell
$env:PYTHONPATH = "src"
.\.venv\Scripts\python.exe -m lora --workspace-root . chat --message "hello"
```

## 16. 常见开发任务

### 16.1 新增 CLI 命令

步骤：

1. 在 `build_parser` 中添加 subparser。
2. 将 handler 设置为私有函数，例如 `_repair_plan`。
3. handler 中只做编排和 JSON 输出，不写底层逻辑。
4. 复用 `load_run_config`、`SessionManager`、`EventStore`。
5. 增加 scenario test，验证命令退出码和产物。

### 16.2 新增 case 断言

步骤：

1. 在 case YAML 中设计 `expect` 或 `metrics` 字段。
2. 在 `CaseManager.validate` 中增加 schema 校验。
3. 在 `Evaluator.evaluate` 中增加断言逻辑。
4. verdict failure 要包含：
   - `type`
   - `message`
   - `expected`
   - 必要时包含 `actual` 和证据路径。
5. 增加 unit test 和至少一个 scenario。

### 16.3 新增工具

步骤：

1. 在 `agent.py` 新增 `BaseTool` 子类。
2. 构造函数中定义 name、description、category、parameters 描述。
3. `forward` 只实现业务逻辑。
4. 如有文件访问，使用 workspace 安全路径检查。
5. 在 `LoraAgent.start_run` 中 `_register_tool`。
6. 确认工具调用都通过 `ToolInterceptor.call_tool`。
7. 增加工具单测和 runtime 场景测试。

### 16.4 接入新的 Agent 实现

最小要求：

```python
class MyAgent:
    async def stream(self, context: RuntimeContext, max_steps: int = -1):
        yield {"role": "assistant", "content": "..."}
```

可选要求：

```python
def start_run(self, case_run_ref: CaseRunRef, turn_id: str | None) -> None:
    ...
```

如果 agent 只支持 `run(prompt, max_steps=...)`，`AgentRuntimeAdapter` 也可以兼容，但无法天然记录中间 tool message。

### 16.5 新增事件类型

步骤：

1. 确定事件 payload schema。
2. 通过 `EventStore.append("event.type", actor=..., payload=..., turn_id=...)` 写主事件。
3. 如果需要高频查询，在 `EventStore._append_event` 中增加投影文件。
4. 增加 trace unit test。

### 16.6 新增 workspace setup 类型

步骤：

1. 在 `CaseManager.validate` 中校验字段。
2. 在 `prepare_workspace` 中分发新类型。
3. 新增私有方法处理具体逻辑。
4. 产物必须记录到 run_dir，便于 replay 和分析。
5. 增加 `test_case_manager.py` 覆盖。

## 17. 现有边界和风险

| 区域 | 当前状态 | 后续建议 |
| --- | --- | --- |
| YAML 解析 | 自研子集 | case 复杂后引入 PyYAML 或 ruamel.yaml |
| `PromptModule.version_hash` | 已使用基于 SHA-256 的稳定 hash | 如需更强一致性，可把 render 函数版本也显式纳入 hash |
| 文件路径安全 | Agent 工具和 case setup 路径都限制在 workspace 内 | 如需外部 fixture，后续增加显式 allowlist |
| regression | 已实现 manifest 读取、suite 执行、汇总产物和 regression 事件 | 后续可增加选择性运行、标签过滤和历史对比 |
| analysis | 已抽出独立 `FailureAnalyzer`，覆盖 runtime/tool/assertion/file/budget 等归因 | 后续可增加更细的 root cause 策略 |
| repair | 已实现最小闭环 | `lora repair plan/apply/gate` 支持确定性计划、人工 patch 捕获和命令/regression gate |
| prompt 落盘 | 已保存 session static prompt、每次请求真实发送的完整 rendered system prompt 文本/元数据，以及最新 `session.json.system_prompt` | 后续可增加保留策略和敏感信息过滤 |
| agent 管理 | 已支持 `--agent`、agent profile 解析、模型请求配置和密钥脱敏；运行时仍默认使用 `LoraAgent` | 后续增加 agent profile CRUD 和 adapter registry |

## 18. 推荐扩展路线

短期：

1. 补齐完整 YAML 支持或引入标准 YAML 库。
2. 增加 agent profile CRUD 命令，并为不同 Agent backend 引入 adapter registry。
3. 扩展 regression runner：选择性运行、标签过滤、历史结果对比。
4. 增强 `FailureAnalyzer`：更细 root cause、更多修复建议和证据链接。
5. 为 prompt rendered 增加保留策略或可配置开关。

中期：

1. 支持完整 YAML。
2. 增加更多工具和文件写入追踪。
3. 实现 context checkpoint/projection 的真实恢复能力。
4. 增加模型请求和响应的详细 token/耗时指标。

长期：

1. 模型辅助生成失败复现测试。
2. repair agent 自动生成 patch attempt。
3. 多 session 对比和非确定性检测。
4. 面向不同 Agent backend 的 adapter registry。

## 19. 开发守则

- 不要绕过 `SessionManager` 创建 run。
- 不要绕过 `EventStore` 写 trace。
- 不要让工具自己吞掉异常而不记录，异常应由 `ToolInterceptor` 包装。
- 不要在 evaluator 中执行 Agent 或修改 session。
- 不要把一次 run 的判断逻辑写死在 CLI，CLI 只做编排。
- 任何新增持久化文件都应放在 session/run 目录结构下，并在文档中说明生产者。
- 新接口必须补单元测试；跨模块调用链必须补 scenario test。

## 20. 一句话心智模型

开发时始终把 Lora 看成四条链同时推进：

```text
配置链：CLI/env/lora.yaml -> RunConfig
上下文链：SessionManager -> AgentSession -> RuntimeContext -> session.json
证据链：EventStore -> events.jsonl -> projections -> replay/analyze
评估链：CaseDefinition -> AgentRuntimeAdapter -> Evaluator -> verdict/analysis
```

只要这四条链不断，新增能力就能被复现、回放、评估和继续优化。
