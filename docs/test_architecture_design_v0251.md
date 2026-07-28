# vLLM-HCU v0.25.1 测试分层与代码架构设计

> 状态：设计草案 + 当前落地状态，供评审使用。  
> 范围：测试目录、公共测试代码、运行入口、硬件资源描述、CI 分层和结果报告。  
> 本文不代表现有测试已经全部迁移到目标结构。
>
> 当前状态：已建立目录、marker、suite 入口、资源参数和轻量 fixture
> contract；已新增一批真实模型 integration 测试，包括单卡 Qwen3.5、
> Qwen3、Qwen3-VL、LoRA、Spec Decode、KV transfer 和 EvalScope 精度入口。

## 1. 背景

vLLM-HCU 已经建立原有 pytest 测试基线，主要覆盖：

- 82 个 Patch 的注册、导入、接口和直接测试引用。
- Patch 幂等、失败锁定、回滚、清理和进程角色。
- Attention、MLA、Mamba/GDN、MoE、量化和调度等运行时逻辑。
- Portable reference 数值验证。
- 环境变量到执行路径的路由验证。
- 一部分真实 HCU kernel 精度测试。

现有体系适合验证“Patch 是否正确安装、接口是否兼容、关键 Python 路径
是否正确”，但还需要逐步补齐：

- 真实 checkpoint 加载和 `LLM.generate()`。
- greedy token、logprob 和 Hugging Face/reference 对照。
- CUDA Graph capture/replay。
- LoRA、Spec Decode、Graph 的组合运行。
- Mooncake、split P/D 和 KV transfer 状态机。
- TP、DP、EP、DeepEP 和多进程通信。
- 长上下文、压力、性能和稳定性。

本设计参考 vLLM-Ascend 的测试分层、硬件路由和 CI 选集思想，但不复制其
大型公共 `conftest.py`、NPU 专用实现和隐式目录规则。

## 2. 设计目标

### 2.1 目标

1. 保留并兼容当前测试基线和已有运行命令。
2. 明确区分契约、数值、真实 kernel、模型、分布式和稳定性验证。
3. 让测试声明自己的硬件、模型、外部服务和执行时间需求。
4. 将公共测试能力拆成小型 fixture 和 runner，避免单个文件持续膨胀。
5. 支持根据源码改动选择相关测试，同时由 nightly 全量测试兜底。
6. 测试失败时能够回答：
   - 哪个功能失败；
   - 在什么环境失败；
   - 使用了哪个 vLLM/HCU/依赖版本；
   - 实际走到了哪个执行路径；
   - reference、实际值和容差分别是什么。
7. 覆盖报告区分“执行过”和“验证正确”，避免单纯按节点数量判断质量。

### 2.2 非目标

1. 不一次性移动或重写现有测试基线。
2. 不要求所有开发者本地拥有 HCU、多卡和完整模型权重。
3. 不在 PR 中运行全部大模型、长上下文和多节点测试。
4. 不通过大量 mock 伪装真实 kernel、Graph 或通信已经验证。
5. 不把性能波动直接混入功能正确性断言。

## 3. 总体原则

### 3.1 分层，而不是只分文件

每项测试应能够归入一个明确的最高验证层级：

| 层级 | 名称 | 验证内容 | 典型环境 |
|---|---|---|---|
| L0 | Inventory | 文件、注册表、Patch 清单、静态引用 | 无 PyTorch/CPU |
| L1 | Contract | API、签名、状态机、路由、失败语义 | CPU/Mock |
| L2 | Portable Accuracy | Python 实现与独立 reference 的数值一致性 | CPU |
| L3 | HCU Kernel Accuracy | 真实 HCU kernel 与 float32/official reference 对照 | 单 HCU |
| L4 | Model Integration | checkpoint 加载、生成、Graph、LoRA、Spec Decode | 单/多 HCU |
| L5 | Distributed/System | TP/DP/EP、DeepEP、P/D、Mooncake、多进程/多节点 | 多 HCU |
| L6 | Stress/Performance | 长上下文、压力、显存、吞吐、稳定性 | Nightly/Weekly |

覆盖报告必须记录每个 Patch 或功能达到的最高验证层级。例如：

- 被 UT import 到，不等于真实 kernel 已验证。
- 模型能够启动，不等于输出精度已验证。
- 能够生成文本，不等于 Spec Decode 与 baseline 等价。

### 3.2 默认隔离，显式复用

- Patch 注册、plugin、环境变量和 import 测试默认使用干净子进程。
- 模型实例默认每个测试独立创建。
- 只有显式标记为可复用的无状态测试才能使用模型缓存。
- 测试结束必须清理 distributed process group、子进程、环境变量和设备内存。

### 3.3 Reference 必须独立

数值测试的 reference 不应调用被测实现内部的同一个 helper。

优先级如下：

1. 简单、独立的 float32 PyTorch 实现。
2. vLLM official 路径。
3. Hugging Face eager 路径。
4. feature-off/eager baseline。
5. 固化的、带版本信息的 golden 数据。

## 4. 目标目录结构

现有目录保持不动，在其上渐进增加新层：

```text
tests/
├── patch/                         # 现有：Patch 基础机制
├── runtime_patch/                 # 现有：运行时 Patch 契约
├── accuracy/
│   ├── test_portable_operator_accuracy.py
│   ├── test_hcu_kernel_accuracy.py
│   ├── test_environment_routing.py
│   ├── portable/                  # 新增规模扩大后再拆分
│   ├── kernels/                   # 按 attention/moe/quant/sampling 拆分
│   └── routing/                   # 环境变量和后端路径
├── integration/
│   ├── models/                    # checkpoint、生成、logprob
│   ├── graph/                     # CUDA Graph capture/replay
│   ├── lora/                      # 单 LoRA、多 LoRA、动态切换
│   ├── spec_decode/               # MTP/Eagle/rejection/state correction
│   ├── kv_transfer/               # Connector、失败、生命周期
│   └── server/                    # OpenAI API、启动和关闭
├── distributed/
│   ├── single_node/               # 当前单机 8 卡可执行
│   │   ├── collectives/           # all-reduce/all-to-all 等
│   │   ├── tp_ep/                 # TP/DP/EP/PP/本机 DeepEP
│   │   ├── split_pd/              # 本机 P/D 分离
│   │   └── mooncake/              # 本机 producer/consumer
│   └── multi_node/                # 预留；当前环境不可执行
├── stress/
│   ├── long_context/
│   ├── memory/
│   └── soak/
├── fixtures/
│   ├── device.py
│   ├── process.py
│   ├── model_runner.py
│   ├── reference_runner.py
│   ├── distributed.py
│   ├── kv_transfer.py
│   └── artifacts.py
├── models/
│   ├── qwen35_9b_gsm8k_evalscope.yaml
│   ├── qwen3_8b_gsm8k_evalscope.yaml
│   ├── qwen3_vl_8b_mmmu_evalscope.yaml
│   ├── deepseek_r1_gsm8k_evalscope.yaml
│   └── common_prompts.yaml              # 需要时再加入
└── conftest.py                    # 只保留轻量全局 hook
```

### 4.1 目录职责

`patch/` 和 `runtime_patch/`：

- 继续作为 CPU/Mock 主回归。
- 不下载模型。
- 不把模拟对象结果描述为真实 HCU 验证。

`accuracy/`：

- 被测对象是具体算子、布局、量化或路由。
- 每个数值测试必须明确 reference、dtype、shape、seed、`rtol` 和 `atol`。
- 真实 kernel 使用 `hcu` marker。

`integration/`：

- 至少创建一个真实 vLLM Engine、LLM 或 Server。
- 可以使用小模型和短输出。
- 重点验证跨模块组合，不重复 UT 的内部调用次数断言。

`distributed/`：

- 必须实际创建对应拓扑或进程。
- Mock communicator 测试仍放在 `runtime_patch/`。

`stress/`：

- 不作为普通 PR 必过项。
- 功能失败和性能退化分别报告。

## 5. Pytest Marker 设计

保留现有 `hcu`，增加以下 marker：

| Marker | 含义 |
|---|---|
| `hcu` | 需要真实 HCU/ROCm 或已编译 HCU 扩展 |
| `model` | 需要加载真实模型 checkpoint |
| `multi_hcu` | 需要两张或更多 HCU |
| `hcu_count(count)` | 声明单节点需要的 HCU 数量 |
| `multi_node` | 需要两台或更多物理计算节点 |
| `node_count(count)` | 声明需要的物理节点数量 |
| `external_service` | 需要 Mooncake、远端存储或独立 Server |
| `slow` | 正常耗时超过 PR 快速预算 |
| `nightly` | 只在 nightly/full 中默认运行 |
| `isolated_process` | 必须在干净子进程运行 |
| `reuse_model` | 允许复用完全相同配置的模型实例 |

需要指定卡数时使用：

```python
@pytest.mark.hcu
@pytest.mark.multi_hcu
@pytest.mark.hcu_count(4)
def test_deepseek_tp2_ep2(...):
    ...
```

Marker 只描述资源和执行属性，功能分类仍由目录和测试名称表达。

## 6. Suite 设计

保留当前 suite，并以兼容方式新增：

| Suite | 默认选择 | 目标 |
|---|---|---|
| `inventory` | 现有 Patch inventory | 秒级静态门禁 |
| `accuracy` | `accuracy` 且 `not hcu` | CPU reference 和路由 |
| `accuracy-hcu` | `accuracy` 且 `hcu` | 真实 kernel 精度 |
| `contract` | 现有 CPU/Mock 测试 | 主契约回归 |
| `integration-smoke` | integration，排除 slow/multi_hcu | 单卡最小模型回归 |
| `model` | `model and hcu and not multi_hcu` | 单卡模型功能 |
| `distributed-single-node` | single_node 且 `not multi_node` | 当前单机多卡/多进程 |
| `distributed-multi-node` | `multi_node` | 预留的真实多节点测试 |
| `distributed` | 全部 distributed | 具备对应资源时的总入口 |
| `stress` | stress | 长上下文、显存和 soak |
| `nightly` | `hcu or model or nightly` | 单节点完整回归 |
| `full` | 全部 tests | 目标硬件完整收集和执行 |

兼容要求：

- 当前命令含义不变。
- 新 suite 通过扩展 `tools/run_patch_tests.py` 加入。
- 用户仍可在 `--` 后传递 pytest 的 `-k`、`-m` 和 node id。

示例：

```bash
python tools/run_patch_tests.py --suite contract
python tools/run_patch_tests.py --suite accuracy-hcu
python tools/run_patch_tests.py --suite integration-smoke
python tools/run_patch_tests.py --suite model -k qwen35
python tools/run_patch_tests.py --suite distributed-single-node -k mooncake
python tools/run_patch_tests.py --suite distributed-multi-node
```

在骨架阶段，如果新增 suite 下还没有任何 `test_*.py`，运行器会明确输出
“scaffold exists but contains no test files yet”并成功退出；它不会报告虚假的
passed 数量。

## 7. 公共测试代码架构

### 7.1 根 `conftest.py`

根 `tests/conftest.py` 只允许包含：

- marker 注册或校验；
- repository path；
- session 环境指纹；
- 通用随机 seed；
- 不会初始化 HCU 的设备探测。

禁止在 import/collection 阶段：

- 初始化 CUDA/HCU context；
- 调用 Patch 安装；
- 注册真实 kernel；
- 修改全局 `sys.modules`；
- 下载或加载模型；
- 启动子进程和外部服务。

### 7.2 Fixture 模块

按领域拆分 fixture，通过相应子目录的 `conftest.py` 局部加载。

`fixtures/device.py`：

- 判断是否为 HCU/ROCm；
- 检查架构、设备数和扩展；
- 提供 `hcu_device`；
- 统一 skip reason；
- 采集显存前后状态。

`fixtures/process.py`：

- 启动干净 Python 子进程；
- 设置最小环境变量；
- 捕获 stdout/stderr；
- 超时后终止整个进程组；
- 验证没有残留进程。

`fixtures/model_runner.py`：

- 创建和关闭 vLLM `LLM`；
- 统一 `generate()`、logprob、embedding 输出格式；
- 不包含 Hugging Face reference 逻辑；
- 默认不缓存模型。

`fixtures/reference_runner.py`：

- Hugging Face/eager reference；
- official vLLM feature-off baseline；
- token、logit、logprob 和文本比较器。

`fixtures/distributed.py`：

- 分配端口；
- spawn worker；
- 建立 rank/world-size；
- 收集每个 rank 的日志和异常；
- 无条件执行 teardown。

`fixtures/kv_transfer.py`：

- producer/consumer 进程；
- Mooncake 或 fake transport 生命周期；
- 故障注入；
- 超时、重试和清理。

`fixtures/artifacts.py`：

- JUnit、环境指纹、生成结果、错误张量摘要；
- 不在通过时保存大体积 tensor。

### 7.3 Runner 边界

建议只建立四类公开 Runner：

```text
HcuVllmRunner       真实 vLLM-HCU 离线推理
ReferenceRunner     HF/official/eager reference
HcuServerRunner     OpenAI Server 子进程
DistributedRunner   TP/DP/EP/P-D 多进程编排
```

Runner 返回统一结果对象：

```python
@dataclass
class GenerationResult:
    prompt_token_ids: list[int]
    output_token_ids: list[int]
    text: str
    token_logprobs: list[float] | None
    finish_reason: str | None
```

测试不应直接依赖 vLLM 内部 `RequestOutput` 的全部结构，以降低 vLLM
小版本升级造成的修改范围。

## 8. 模型配置

真实模型测试使用 YAML 描述模型和资源，不在测试代码中散落路径：

```yaml
name: qwen35_9b_gsm8k_evalscope
model: /models/llm-models/qwen3.5/Qwen3.5-9B

server:
  host: 127.0.0.1
  port: 10130
  startup_timeout_s: 1200
  shutdown_timeout_s: 60
  args:
    - --trust-remote-code
    - --max-model-len
    - "8192"
    - --max-num-batched-tokens
    - "4096"
    - --max-num-seqs
    - "16"
    - --gpu-memory-utilization
    - "0.4"
    - --enforce-eager

evalscope:
  work_dir: /tmp/vllm-hcu-evalscope/qwen35_9b_gsm8k
  eval_type: openai_api
  generation_config:
    temperature: 0
    max_tokens: 1024
    top_p: 0.95
    stop_seqs:
      - <|im_end|>
    extra_body:
      chat_template_kwargs:
        enable_thinking: false
  datasets:
    - gsm8k
  pass_criteria:
    dataset: gsm8k
    metric: mean_acc
    display_name: Pass@1
    minimum_score: 0.95
```

配置规则：

- 仓库只保存逻辑名称、相对路径和可选的远端 ID。
- checkpoint 根目录通过 `--model-root` 或
  `VLLM_HCU_TEST_MODEL_ROOT` 传入。
- 数据集根目录通过 `--dataset-root` 或
  `VLLM_HCU_TEST_DATASET_ROOT` 传入。
- 文件中记录最小设备数和估算显存。
- 不把访问 token、私有地址和凭据写入仓库。
- 默认不下载；只有 `--allow-model-download` 才允许远端解析。
- CI 的 model/nightly 使用 `--strict-test-resources`，资源缺失必须失败。
- baseline 必须记录生成它的 vLLM、vLLM-HCU、PyTorch、模型 revision
  和硬件架构。
- OpenAI server + EvalScope 精度测试使用 `tests/integration/server/`
  的共享 runner。runner 会启动 `vllm serve`、等待 `/health`、运行
  EvalScope、检查 `pass_criteria`，最后关闭 server。
- EvalScope `generation_config` 以 JSON 传给 CLI，允许携带
  `extra_body`、`stop_seqs` 等嵌套参数。Qwen3.5 reasoning 模型必须显式
  传入 `chat_template_kwargs.enable_thinking=false`，否则 GSM8K 输出可能
  打满 `max_tokens` 并污染答案抽取。
- HCU 模型 integration 子进程统一设置
  `VLLM_HCU_USE_FLASH_ATTN_UNIFIED=1`，并默认清除 `VLLM_PLUGINS`、使用
  `VLLM_WORKER_MULTIPROC_METHOD=spawn`。
- 长日志、EvalScope report 和子进程 stdout/stderr 默认写入 `/tmp`：
  - `/tmp/vllm-hcu-integration/logs`
  - `/tmp/vllm-hcu-evalscope/<case>`

当前已落地配置：

| 配置文件 | 模型 | 数据集/用途 | 通过标准 |
|---|---|---|---|
| `qwen3_8b_gsm8k_evalscope.yaml` | `/models/llm-models/qwen3/Qwen3-8B` | GSM8K EvalScope | `mean_acc >= 0.95` |
| `qwen35_9b_gsm8k_evalscope.yaml` | `/models/llm-models/qwen3.5/Qwen3.5-9B` | GSM8K EvalScope | `mean_acc >= 0.95` |
| `qwen3_vl_8b_mmmu_evalscope.yaml` | `/models/llm-models/qwen3/Qwen3-VL-8B-Instruct` | MMMU `Art` subset | `mean_acc >= 0.55` |
| `deepseek_r1_gsm8k_evalscope.yaml` | `/models/llm-models/DeepSeek-R1-Channel-FP8-w8a8` | GSM8K EvalScope | `mean_acc >= 0.95` |

## 9. 断言标准

### 9.1 模型生成

greedy：

- 优先逐 token 完全一致。
- 如因后端浮点差异无法完全一致，同时比较前 N token、logprob 和任务结果。
- 不能只断言“没有抛异常”。

Spec Decode：

- feature-off/eager baseline 与 feature-on 输出对照。
- 分别覆盖全接受、全拒绝、部分接受、batch 变化和请求结束。
- 同时检查输出 token 和内部 token 计数不变量。

LoRA：

- base、LoRA-only、LoRA+Graph、LoRA+Spec Decode 分组对照。
- 动态切换后验证旧 adapter 不污染新请求。

CUDA Graph：

- 确认发生真实 capture 和 replay。
- eager 与 Graph 对照 token/logprob。
- 至少覆盖 batch bucket 边界。

EvalScope 精度：

- server 能启动不代表精度通过，必须读取 EvalScope report 中的指标。
- GSM8K 使用 `mean_acc` 表示 Pass@1 聚合值，当前门槛为 `>= 0.95`。
- MMMU 在 EvalScope 1.9.1 中 report metric 也为 `mean_acc`，不是
  `acc`；`display_name` 可保留为 `acc` 便于阅读。
- MMMU 的 `limit` 是每个 subset 的样本数；默认 30 个 subset 时
  `limit: 10` 会实际跑 300 样本。patch smoke 配置应显式设置
  `dataset_args.mmmu.subset_list`，避免误触发长时间全量多模态评测。

### 9.2 算子数值

每项测试必须输出或在参数中表达：

- seed；
- shape；
- dtype；
- reference dtype；
- `rtol`、`atol`；
- 最大绝对误差和最大相对误差；
- NaN/Inf；
- 输入是否被原地修改。

量化算子除了 output close，还应检查：

- scale；
- 饱和范围；
- 反量化误差上界；
- zero/极值输入；
- 非 contiguous 和边界 shape。

### 9.3 Smoke 测试

允许 smoke 只验证：

- 能否启动；
- 能否加载；
- 能否执行一次短生成；
- 能否正常关闭。

但报告必须明确标记为 `smoke`，不能计为输出精度通过。

## 10. 源码改动到测试选集

新增 `.ci/test_matrix.yaml`，维护源码域到测试域和资源的映射：

```yaml
domains:
  spec_decode:
    sources:
      - vllm_hcu/v1/spec_decode/**
      - vllm_hcu/patch/worker/framework_opt/patch_llm_base_proposer.py
    tests:
      - tests/runtime_patch/test_worker_framework_opt.py
      - tests/integration/spec_decode
    fallback_suite: integration-smoke

  mooncake:
    sources:
      - vllm_hcu/distributed/kv_transfer/**/mooncake/**
      - vllm_hcu/patch/platform/framework_opt/patch_mooncake_connector.py
    tests:
      - tests/runtime_patch/test_platform_framework_opt.py
      - tests/integration/kv_transfer
    resources:
      external_service: mooncake
```

选集规则：

1. 测试文件自身修改时必须运行该文件。
2. Patch 文件修改时必须运行其直接契约测试。
3. 公共 Patch infrastructure 修改时运行全部 `inventory + contract`。
4. 公共 runner/fixture 修改时运行其全部消费者。
5. 未匹配到已知域的 `vllm_hcu/**` 修改，至少运行
   `contract + integration-smoke`。
6. CI 选集只减少 PR 时间，nightly 仍运行完整硬件测试。
7. 映射配置必须有静态门禁，防止源码域和测试文件漂移。

后续测试规模扩大后，可记录历史耗时并按预计时间做分片；第一阶段不需要
直接实现复杂的自动负载均衡。

## 11. CI 分层

### 11.1 PR：静态 CPU

所有 PR 必跑：

- Patch coverage gate。
- production boundary。
- `compileall`。
- inventory。
- portable contract。
- portable accuracy。

目标：无 HCU 环境也能发现注册、接口、导入和纯逻辑回归。

### 11.2 PR：自托管单 HCU

修改 HCU runtime、kernel 或模型路径时选择性运行：

- 相关 HCU kernel accuracy。
- clean-process enabled-target smoke。
- 一个小模型短生成。
- 相关功能的 eager/Graph 或 feature-off/on 对照。

建议单组目标时间控制在 20 至 40 分钟。

### 11.3 Nightly：单节点 HCU

- 全部 HCU kernel accuracy。
- Qwen3/Qwen3.5、Qwen3-VL 和 DeepSeek 最小模型矩阵。
- EvalScope GSM8K/MMMU 精度入口。
- LoRA、Graph、Spec Decode、KV transfer 组合。
- 长短 batch、不同 capture bucket。
- 单节点 TP/EP。

### 11.4 Nightly：单机 8 卡

- TP/DP/EP/DeepEP。
- 本机 split P/D。
- 本机 Mooncake producer/consumer。
- 总卡数不超过 8 的不同 TP 比例和失败恢复。
- 长上下文、压力和 soak。

这些结果记为 `single-node distributed`，不能描述为跨节点验证。

### 11.5 Weekly：真实多节点（暂缓）

- 跨节点 TP/PP/DP/EP/DeepEP。
- 跨节点 split P/D 和 Mooncake/RDMA。
- 网络分区、远端重启、节点失联和重连。
- 跨节点 collective 带宽、延迟和扩展效率。
- 不同 HCU 架构。

当前只有单机 8 卡，因此本节只保留目录和 marker，不纳入当前验收。

## 12. 环境指纹与测试产物

每次硬件测试保存：

- vLLM-HCU commit；
- vLLM commit/version；
- Python、PyTorch、ROCm/HCU runtime；
- AITER、lightop、flash-attention 和量化库版本；
- GPU/HCU 名称、架构和数量；
- 测试 suite、marker 和完整 node id；
- 关键环境变量；
- 模型 ID/revision；
- JUnit XML；
- 失败测试的 stdout/stderr。

模型精度报告额外保存：

- baseline 类型；
- token match；
- 最大 logprob 误差；
- 任务指标；
- 是否为 smoke；
- eager/Graph、TP/EP、LoRA 和 Spec Decode 配置。
- EvalScope report JSON 路径、样本数、metric 名称和 pass threshold。

## 13. 与 vLLM-Ascend 的取舍

### 13.1 借鉴

- PR、nightly、weekly 的执行成本分层。
- CPU、单卡、多卡、多节点资源分层。
- 源码改动到相关测试的映射。
- 模型配置数据化。
- Runner 对模型输出进行统一封装。
- 历史耗时分片和覆盖矩阵。

### 13.2 不照搬

- 不建立接近 2000 行的公共 `conftest.py`。
- 不在测试收集阶段全局安装 Patch 或初始化 HCU。
- 不依靠目录名隐式决定所有硬件资源。
- 不混用 unittest 和 pytest 基类。
- 不默认跨测试复用有状态模型实例。
- 不用 AST/文件名推断替代真实断言质量。
- 不把一次成功生成描述为模型精度通过。

## 14. 分阶段实施

### 阶段 A：架构骨架

- 增加 marker。
- 创建 `tests/fixtures/` 和轻量根 `conftest.py`。
- 扩展 suite，但保持现有 suite 行为。
- 增加环境指纹和统一 skip reason。

验收：

- 现有节点数量和运行结果不发生非预期变化。
- `contract` 仍可在 CPU/Mock 环境运行。
- `accuracy-hcu` 仍只选择真实 HCU 测试。

### 阶段 B：关键逻辑补强

- 已启动无需真实模型/数据集的补强：
  - Spec Decode sequence-parallel padding、Lightly-CP 阈值和
    multi-layer MTP head 保留。
  - Mooncake metadata、remote prefill/decode 状态迁移和 abort 清理。
  - Top-k/Top-p custom path 的 softmax、filter 参数和 deterministic
    contract。
  - 单节点 TP/PP/EP 资源声明和 8 卡边界。
- 后续继续补 Spec Decode accepted/rejected/batch-change。
- 后续继续补 Mooncake 失败、超时、清理和切分计划。
- 后续继续补 Top-k/Top-p 与 rejection sampler 精度矩阵。
- 全环境变量注册表门禁放在本阶段后段，作为配置完整性检查。

验收：

- 新增测试能够在不加载完整模型时覆盖关键状态机。
- HCU kernel case 与独立 reference 对照。

### 阶段 C：单卡模型集成

- 已实现轻量 `tests/integration/model_runtime.py` 子进程 runner。
- 已增加 Qwen3.5-9B smoke 与 eager/Graph token parity。
- 已增加 Qwen3-8B、Qwen3.5-9B、Qwen3-VL-8B 和 DeepSeek-R1 的
  EvalScope server 精度配置/入口。
- 已增加 Qwen3-4B LoRA switching、Llama2 EAGLE Spec Decode parity 和
  Qwen3-4B ExampleConnector KV transfer smoke。
- 后续再视需要抽象成正式 `HcuVllmRunner`/`ReferenceRunner` 类，避免
  在用例数量较少时过度封装。

验收：

- 至少一个 Qwen3.5 和一个 Qwen3-VL 配置完成真实加载与 EvalScope 精度报告。
- greedy token、Graph parity、LoRA routing、Spec Decode parity 或明确的
  任务指标与 baseline/threshold 对照。
- engine 和子进程能够完整关闭。

### 阶段 D1：单机 8 卡分布式与 P/D

- TP/EP/DeepEP。
- 本机 Mooncake 和 split P/D 双进程。
- 失败注入和恢复。

验收：

- 每个 rank 的失败能够回传到主 pytest。
- 超时后没有残留 worker、端口和 process group。

### 阶段 D2：真实多节点（暂缓）

- 跨节点通信、Mooncake/RDMA 和 P/D。
- 网络与物理节点故障恢复。
- 多节点性能和不同 HCU 架构。

本阶段不属于当前单机 8 卡环境的交付范围。

### 阶段 E：智能选集与长期回归

- `.ci/test_matrix.yaml`。
- PR change-based selection。
- 历史耗时分片。
- nightly/weekly 报告和趋势。

## 15. 已落地文件和后续首批测试

当前已经建立以下骨架和首批测试：

```text
tests/conftest.py
tests/fixtures/device.py
tests/fixtures/process.py
tests/fixtures/model_runner.py
tests/fixtures/reference_runner.py
tests/fixtures/distributed.py
tests/fixtures/kv_transfer.py
tests/fixtures/artifacts.py
tests/fixtures/resources.py
tests/integration/
tests/integration/models/test_qwen35_9b_smoke.py
tests/integration/graph/test_qwen35_9b_graph_parity.py
tests/integration/lora/test_qwen3_4b_lora_switching.py
tests/integration/spec_decode/test_llama2_7b_eagle_parity.py
tests/integration/kv_transfer/test_example_connector_smoke.py
tests/integration/server/evalscope_server.py
tests/integration/server/test_evalscope_qwen3_8b_gsm8k.py
tests/integration/server/test_evalscope_qwen35_9b_gsm8k.py
tests/integration/server/test_evalscope_qwen3_vl_8b_mmmu.py
tests/integration/server/test_evalscope_deepseek_r1_gsm8k.py
tests/distributed/single_node/
tests/distributed/multi_node/
tests/stress/
tests/models/
tests/models/qwen3_8b_gsm8k_evalscope.yaml
tests/models/qwen35_9b_gsm8k_evalscope.yaml
tests/models/qwen3_vl_8b_mmmu_evalscope.yaml
tests/models/deepseek_r1_gsm8k_evalscope.yaml
```

常用运行命令：

```bash
python tools/run_patch_tests.py --suite model -k qwen35_9b
python tools/run_patch_tests.py --suite model -k qwen35_9b_gsm8k_evalscope_server
python tools/run_patch_tests.py --suite model -k qwen3_vl_8b_mmmu_evalscope_server
python tools/run_patch_tests.py --suite model -k qwen3_4b_lora_switching
python tools/run_patch_tests.py --suite model -k llama2_7b_eagle
python tools/run_patch_tests.py --suite model -k example_connector
```

后续仍建议补充：

```text
tests/integration/spec_decode/test_state_correction.py
tests/integration/kv_transfer/test_mooncake_failures.py
tests/integration/models/test_deepseek_smoke.py
.ci/test_matrix.yaml
```

首批仍不建议立即实现大型 multi-node 和性能框架；先用小型 fixture 验证
分层边界，避免测试基础设施先于实际测试需求膨胀。

## 16. 评审重点

在开始实现前建议确认：

1. 单 HCU PR runner 和多 HCU nightly runner 的实际资源。
2. 可稳定访问的 Qwen3/Qwen3.5、Qwen3-VL、DeepSeek 小模型路径。
3. Mooncake 测试能否启动本地服务，还是先使用 fake transport。
4. 模型输出要求逐 token 完全一致，还是允许 logprob/任务指标容差。
5. HCU 架构覆盖范围及默认基准架构。
6. CI 对单组执行时间和模型缓存空间的限制。

确认这些约束后，再确定阶段 C、D 的具体模型矩阵、卡数和超时。
