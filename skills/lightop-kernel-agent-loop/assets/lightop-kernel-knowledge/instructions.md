---
name: lightop-kernel-knowledge
description: 在 DCU/ROCm 上新增或优化 LightOp 融合算子且需要 HIP 优化方法或实现证据时使用：检查本地源码、测试与配置，检索 ROCm/HIP/MIOpen/rocBLAS/hipBLASLt/Composable Kernel/Triton AMD/PyTorch ROCm/SGLang 或 vLLM AMD 实现，查阅官方文档；内置 CUDA PR 语料仅用于跨平台启发。
allowed-tools: Bash Read Grep Glob
---

## 内置索引与证据边界

查询前阅读[语料打包说明](references/corpus-packaging.md)。从本 Skill 根目录运行内置 `scripts/`。完整证据包操作需要可选的完整语料；未提供时，应获取并核验所引用的原始来源。

# LightOp 算子知识

本 Skill 将 LightOp/DCU 算子问题转化为可引用的实现证据。优先本地 LightOp 证据，其次是 ROCm/DCU 上游证据，最后才将跨平台 CUDA 证据用于启发。

适合回答以下问题：

- LightOp 如何暴露和测试相似算子？
- 新算子应放在哪个 `csrc/<family>` 中？
- 当前 kernel 由哪张配置表或哪个 dispatcher 分支选择？
- ROCm/PyTorch/Triton AMD/SGLang/vLLM 是否已经提供相似的 DCU 路径？
- 下一次修改应依据哪个 DCU profiler 信号？
- 某个 CUDA PR 的思路能否迁移到 HIP/DCU，需要转换哪些内容？

## HIP 方法知识路线（优化前读取）

除本地源码证据外，方法选择优先参考同一安装目录下的 `kernel-hip-handbook` 与 `kernel-hip-optimize`。先定位这两个 Skill 的实际根目录，再按下表加载所需文件；不要把目录名当作已读证据。内置副本位于 agent-loop 的 assets 内，同级 Skill 应从外层 skills 目录定位，不能按 assets 的同级目录猜测。

| 需要解决的问题 | 来源中的文件 |
| --- | --- |
| roofline、优化空间与结构重构 | `kernel-hip-handbook/SKILL.md`、`references/launch-and-refactor.md` |
| 访存/LDS、资源压力与 wave 归约 | handbook 的 `references/memory-hierarchy.md`、`occupancy.md`、`wavefront-optimization.md` |
| shape 特化和 fallback | handbook 的 `references/shape-specialization.md` |
| 方法触发、跳过条件与兼容性 | optimizer 的 `references/optimization_catalog.md`、`method_registry.json` |
| PMC/SQTT 解释、目标 ISA 核验 | optimizer 的 `references/hcu_metrics_guide.md`、`hcu_isa_signatures.json` |
| 分支验证、消融和有效性状态 | optimizer 的 `references/optimizer-loop.md` |

查阅后将知识变为可检验假设：`来源及版本/哈希 → 适用 gfx/算子契约 → 当前测量证据 → 一项修改 → 预期指标变化 → 正确性/benchmark/ISA/消融验收 → 不适用或停止条件`。目录中的方法 ID 必须实际查到；找不到则使用描述性假设名。没有 HCU 实测的 CUDA/AMD 案例只标记为启发。

必须保留以下证据边界：

- 硬件规格、bank 数、occupancy 上限、寄存器公式和示例收益不能跨型号照搬；以目标设备、DTK、资源输出和实测带宽核对。缺失来源或工具要记录，不伪造数据。
- gfx936/gfx938 的 wave64、向量对齐与尾部、LDS layout、waitcnt/barrier 和 MMAC 操作数布局需要逐项验证；builtin 必须有精确源码签名、目标编译探针及最终 ISA。
- 低 occupancy 不自动等于瓶颈；提升 occupancy、使用 LDS、增加 unroll 或降低精度都需要触发证据和语义条件。
- 模板/自动生成器和复杂 kernel family 建议不代表实现已成立。LightOp 保持 `.cu`、原有绑定及构建/测试；独立 `solve(...)` 实验不能替代集成验证。
- 分开记录正确候选加速与方法贡献；消融须控制其它变量。完整相关 ISA 缺失、dump 不全、方法无收益和编译/正确性失败应分别记录，不能混成“优化无效”。
- 本知识流程不依赖 Humanize/RLCR。两份 HIP Skill 缺失时继续本地源码/内置证据检索，声明限制并使用已核实知识，不安装循环运行时来补位。

研究摘要除原有引用信息外，记录方法/假设、触发指标、资源预算、预期 ISA（适用时）、候选结果与反例。经验卡先作为待验证知识；未核验正确性、目标工作负载收益与归因前，不自动批准经验或重建外部 RAG 索引。

## 证据路线

可以使用一条路线，也可以组合多条。让证据影响代码前，先在研究摘要或尝试台账中记录使用的路线。

### 路线 A：本地 LightOp 源码

这是首选路线。定位包含以下内容的 LightOp checkout：

```text
setup.py
python/lightop/__init__.py
csrc/export.cpp
test/ci_tests/
```

这些路径对应重构后的 checkout；检索前核实所选版本布局。遵循主工作流的可选参数、文件复用、十类 API 和 `test/ci_tests/` 审查规则。提出新 `.cu` 或重复 wrapper 前，先检索已有实现。

先检索以下位置：

```bash
rg -n "<op_name>|<binding_name>|<kernel_name>" python/lightop csrc test setup.py setup_torch29.py
rg -n "m\.def\(\"<op_name>|<wrapper_name>" csrc/export.cpp python/lightop
rg -n "get_.*config|gfx|gcnArchName|PYTORCH_ROCM_ARCH" python/lightop/config*.py setup.py setup_torch29.py
```

需要记录的证据：

- Python wrapper 路径和公共 API 导入路径。
- `export.cpp` 的绑定行。
- `csrc/` 下的 kernel 实现文件。
- 配置或 dispatcher 分支。
- 测试与 benchmark 文件。
- 基线命令及结果。

### 路线 B：ROCm/DCU 上游与官方文档

DCU 专用实现或性能分析问题使用此路线。优先官方文档和上游源码，不优先博客或零散片段。

可用的来源类别：

- SourceFind LightOp 仓库的内置 MR 证据：`sources/prs/sourcefind-lightop/`，产物位于 `evidence/pull-bundles/sourcefind-lightop/`。
- DCU Toolkit flash-attention-cutlass 仓库的内置 MR 证据：`sources/prs/flash-attention-cutlass/`，产物位于 `evidence/pull-bundles/flash-attention-cutlass/`。
- `sources/refs/` 下的源码参考页，尤其是：
  - `ref-hygon-hip-kernel-optimizer`：Hygon/DCU HIP 优化流程、方法分类、性能分析信号、wave64 规则、优先 CK Tile 的指导、基于源码的 builtin 使用规范，以及 `dccobjdump` ISA 核验。
  - `ref-dcu-toolkit-amd-knowledge-base`：受保护的 DCU Toolkit `amd-knowledge-base` 入口。在经过认证的文件同步到本地前，将它视为待获取来源。
- SourceFind DCU/DTK 文档，尤其是性能分析工具指南：`https://developer.sourcefind.cn/gitbook//dcu_developer/DeveloperGuide/dcu_programming/DCU_programming_chapter3_7.html`。
- ROCm/HIP 文档及 profiler 文档。
- PyTorch ROCm 实现与测试。
- MIOpen、rocBLAS、hipBLASLt、Composable Kernel、AITer。
- Triton AMD 后端。
- SGLang/vLLM AMD 路径与测试。

需要记录的证据：

- URL 或本地来源路径。
- 可获得的 commit SHA 或版本。
- 实际影响 LightOp 修改的文件、函数或配置。
- 复制或改编代码时的许可证和 notice 细节。

### 路线 C：内置 PR 语料

内置语料仍含有用的 kernel 工程案例，但大部分面向 CUDA/NVIDIA。仅在路线 A、B 证据不足，或需要跨平台算法思路时使用。

从知识根目录运行：

```bash
python3 scripts/query.py "<operator> <dtype> <symptom>" --compact --limit 30
python3 scripts/query.py "lightop dcu <operator>" --repo sourcefind-lightop --compact --limit 20
python3 scripts/query.py "flash attention dcu" --repo flash-attention-cutlass --compact --limit 20
python3 scripts/query.py "hygon dcu mmac" --type source-reference --compact --limit 20
python3 scripts/query.py "amd knowledge base dcu" --type source-reference --compact --limit 20
python3 scripts/search-pr-diffs.py <term1> <term2> [--any] [--limit 100]
python3 scripts/get_page.py <page-id>
```

借鉴思路前，打开 `artifact_dir` 指定的证据包：

```text
evidence/pull-bundles/<repo>/gh-<id>/review.diff
evidence/pull-bundles/<repo>/gh-<id>/source-snapshot/
evidence/pull-bundles/<repo>/gh-<id>/upstream.json
evidence/pull-bundles/<repo>/gh-<id>/ORIGIN.yaml
evidence/pull-bundles/<repo>/mr-<id>/review.diff
evidence/pull-bundles/<repo>/mr-<id>/source-snapshot/
evidence/pull-bundles/<repo>/mr-<id>/upstream.json
evidence/pull-bundles/<repo>/mr-<id>/ORIGIN.yaml
```

迁移规则：

- CUTLASS/CuTe/PTX/SASS/TMA/WGMMA/tcgen05/Nsight 证据在完成转换前均视为不可直接移植。
- 显式将 CUDA 概念映射到 ROCm：SM 对应 CU，适用时将 warp 对应到 wavefront，shared memory 对应 LDS，tensor-core 路径对应 MFMA 或选定的 ROCm 库/后端。
- Hygon/DCU 专属结论优先使用目标编译证据：`hipprof`、code-object 资源分析、可选 SQTT 和最终 `dccobjdump` 输出。在 Hygon ISA 显示 `v_mmac`、MMOP、matrix-load、DS matrix-read、direct-to-LDS 或其他预期 DCU 模式前，AMD MFMA 与 CUDA tensor-core 名称只作为类比。
- 只有精确签名存在于 DCU 来源页、现有工程源码或编译探针中时，才使用有源码依据的 HCU 或 AMD 命名 builtin。不能从指令助记符或通用 AMD 文档臆造 builtin 名称。
- 不以 CUDA profiler 指标证明 DCU 瓶颈。
- CUDA 来源应记录为启发，不能当成 DCU 实现已经成立的证据。

### 路线 D：外部源码映射

`index.json` 可能登记补充源码仓库。先 clone，再在本地 grep：

```bash
python3 scripts/clone-index-repos.py
python3 scripts/search-index-repos.py <term1> <term2> [<term3>]
```

仅在仓库映射与当前 LightOp 算子相关时使用此路线。为 DCU 工作采用仅 NVIDIA 的案例前，优先向来源映射补充 ROCm/DCU 仓库。

## 查询模式

LightOp 源码查询：

```text
rmsnorm export.cpp wrapper test config
moe w8a8 gfx936 config benchmark
fuse silu quant op binding csrc
sourcefind-lightop gfx938 fused op test
flash-attention-cutlass dcu attention benchmark
hygon dcu mmac wave64 lds waitcnt
amd knowledge base dcu protected source
```

DCU 性能分析查询：

```text
hipprof launch overhead LightOp <op>
rocprof-compute LDS bank conflict HIP kernel
ROCm VGPR occupancy HIP kernel
MFMA utilization Composable Kernel grouped gemm
```

跨平台启发查询：

```text
rmsnorm vectorized load reduction PR
moe grouped gemm quantization dispatch PR
topk softmax fusion benchmark PR
```

## 引用检查清单

每项发现采用相同的引用结构：

- 路线名称。
- 来源路径或 URL。
- 可获得的提交或版本。
- 关键函数、绑定、配置键、测试或 benchmark。
- 这些证据改变了 LightOp 计划的什么内容。
- 思路是否能直接移植到 DCU，还是仅用于跨平台启发。
- 复制或改编代码时的许可证和 notice 细节。

某条路线匹配很少或为空时，先扩大查询词或交叉检查另一条路线，再将其当作发现。

## 验证

配置了可选的完整证据语料后，上游语料验证使用：

```bash
python3 scripts/validate.py
```

验证 LightOp 证据，需要执行 `lightop-kernel-agent-loop` 指定的目标 LightOp 构建、测试、基准测量和性能分析命令。
