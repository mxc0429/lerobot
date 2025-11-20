# SmolVLA with RMT Memory Module - 使用指南

## 📋 概述

本指南介绍如何使用添加了 RMT (Recurrent Memory Transformer) 记忆模块的 SmolVLA 模型进行训练和评估。

## 🎯 记忆模块特性

### 新增配置参数

在 `SmolVLAConfig` 中添加了以下参数：

```python
# RMT Memory settings
num_mem_tokens: int = 0          # 记忆 token 数量 (0=禁用, 4=推荐, 8=增强)
mem_at_end: bool = False         # 是否在序列末尾也添加记忆 tokens
read_mem_from_cache: bool = False # 记忆 tokens 是否从缓存中读取
```

### 参数说明

- **num_mem_tokens**: 
  - `0`: 禁用记忆模块（标准 SmolVLA）
  - `2`: 轻量级记忆（+1,920 参数，0.0004%）
  - `4`: 推荐配置（+3,840 参数，0.0009%）
  - `8`: 增强记忆（+7,680 参数，0.0017%）
  - `16`: 最大记忆（+15,360 参数，0.0034%）

- **mem_at_end**: 
  - `False`: 记忆 tokens 仅在序列开头（推荐）
  - `True`: 记忆 tokens 在开头和结尾都添加

- **read_mem_from_cache**: 
  - `False`: 记忆 tokens 不从历史缓存读取（推荐）
  - `True`: 记忆 tokens 可以访问历史记忆

## 🚀 快速开始

### 1. 训练基线模型（无记忆）

```bash
# 设置你的 Hugging Face 用户名
export HF_USER="your_username"

# 运行基线训练
bash train_baseline_smolvla.sh
```

或者直接使用命令：

```bash
lerobot-train \
  --policy.path=./smolvla_base \
  --dataset.repo_id=${HF_USER}/pickplace_smolvla \
  --batch_size=4 \
  --output_dir=outputs/train/smolvla_baseline \
  --job_name=smolvla_baseline_training \
  --policy.push_to_hub=false \
  --policy.device=cuda \
  --wandb.enable=false \
  --policy.num_mem_tokens=0
```

### 2. 训练带记忆的模型

```bash
# 运行记忆增强训练
bash train_smolvla_with_memory.sh
```

或者直接使用命令：

```bash
lerobot-train \
  --policy.path=./smolvla_base \
  --dataset.repo_id=${HF_USER}/pickplace_smolvla \
  --batch_size=4 \
  --output_dir=outputs/train/smolvla_with_memory_4tokens \
  --job_name=smolvla_memory_training \
  --policy.push_to_hub=false \
  --policy.device=cuda \
  --wandb.enable=false \
  --policy.num_mem_tokens=4 \
  --policy.mem_at_end=false \
  --policy.read_mem_from_cache=false
```

### 3. 评估和对比模型

```bash
python evaluate_models.py \
  --baseline_path outputs/train/smolvla_baseline/checkpoints/last/pretrained_model \
  --memory_path outputs/train/smolvla_with_memory_4tokens/checkpoints/last/pretrained_model \
  --dataset_repo_id ${HF_USER}/pickplace_smolvla \
  --n_episodes 50 \
  --output_file evaluation_results.json
```

## 📊 评估指标

评估脚本会比较以下指标：

1. **成功率 (Success Rate)**
   - 任务完成的百分比
   - 记忆模块的主要改进目标

2. **平均奖励 (Average Reward)**
   - 每个 episode 的平均累积奖励
   - 反映整体性能

3. **推理时间 (Inference Time)**
   - 每步动作预测的时间
   - 评估计算开销

4. **内存使用 (Memory Usage)**
   - GPU 内存占用
   - 评估资源消耗

## 🔬 实验配置建议

### 配置 1: 快速验证
```bash
--policy.num_mem_tokens=2
--steps=10000
--batch_size=8
```
适合快速验证记忆模块是否有效。

### 配置 2: 标准训练（推荐）
```bash
--policy.num_mem_tokens=4
--steps=50000
--batch_size=4
```
平衡性能和训练时间的推荐配置。

### 配置 3: 完整训练
```bash
--policy.num_mem_tokens=4
--steps=200000
--batch_size=4
```
用于获得最佳性能的完整训练。

### 配置 4: 增强记忆
```bash
--policy.num_mem_tokens=8
--steps=200000
--batch_size=4
```
用于复杂的长期任务。

## 📈 预期结果

基于 RMT 论文的结果，预期改进：

- **短期任务**: 成功率提升 1-3%
- **中期任务**: 成功率提升 3-5%
- **长期任务**: 成功率提升 5-10%
- **推理开销**: < 2%
- **内存开销**: < 1%

## 🔍 调试和监控

### 检查记忆 tokens 是否正常工作

```python
from lerobot.policies.smolvla.modeling_smolvla import SmolVLAPolicy

# 加载模型
policy = SmolVLAPolicy.from_pretrained("path/to/checkpoint")

# 检查记忆 tokens
if policy.model.mem_tokens is not None:
    print(f"Memory tokens shape: {policy.model.mem_tokens.shape}")
    print(f"Memory tokens require grad: {policy.model.mem_tokens.requires_grad}")
else:
    print("Memory tokens are disabled")
```

### 监控记忆状态

```python
# 在推理过程中
policy.reset()  # 重置记忆状态

for step in range(num_steps):
    action = policy.select_action(batch)
    
    # 检查记忆状态
    if policy._mem_tokens_state is not None:
        print(f"Step {step}: Memory state shape = {policy._mem_tokens_state.shape}")
```

## 🛠️ 故障排除

### 问题 1: 训练时内存不足

**解决方案**:
- 减少 `batch_size`
- 减少 `num_mem_tokens`
- 使用梯度累积

```bash
--batch_size=2 \
--batch_chunk=2  # 等效于 batch_size=4
```

### 问题 2: 记忆模块没有改进

**可能原因**:
1. 任务不需要长期记忆
2. 训练步数不足
3. 记忆 tokens 数量不合适

**解决方案**:
- 增加训练步数
- 尝试不同的 `num_mem_tokens` (2, 4, 8)
- 检查任务是否真的需要记忆

### 问题 3: 推理速度变慢

**解决方案**:
- 减少 `num_mem_tokens`
- 确保 `use_cache=True`
- 使用 FP16 推理

## 📝 代码修改说明

### 主要修改文件

1. **configuration_smolvla.py**
   - 添加了 `num_mem_tokens`, `mem_at_end`, `read_mem_from_cache` 配置

2. **modeling_smolvla.py**
   - `VLAFlowMatching.__init__`: 添加 `init_mem_tokens()` 初始化
   - `VLAFlowMatching.embed_prefix`: 支持记忆 tokens 嵌入
   - `VLAFlowMatching.forward`: 返回更新的记忆 tokens
   - `VLAFlowMatching.sample_actions`: 支持记忆 tokens 传递
   - `SmolVLAPolicy.reset`: 重置记忆状态
   - `SmolVLAPolicy._get_action_chunk`: 管理记忆状态

### 向后兼容性

所有修改都是向后兼容的：
- 默认 `num_mem_tokens=0` 时，行为与原始 SmolVLA 完全相同
- 现有的训练脚本无需修改即可运行

## 🎓 进阶使用

### 自定义记忆初始化

```python
# 在 VLAFlowMatching.__init__ 中
def init_mem_tokens(self):
    if self.config.num_mem_tokens == 0:
        self.mem_tokens = None
    else:
        hidden_size = self.vlm_with_expert.config.text_config.hidden_size
        
        # 方法 1: 随机初始化（默认）
        mem_tokens = torch.randn(self.config.num_mem_tokens, 1, hidden_size) * 0.02
        
        # 方法 2: 零初始化
        # mem_tokens = torch.zeros(self.config.num_mem_tokens, 1, hidden_size)
        
        # 方法 3: 从预训练嵌入初始化
        # mem_tokens = self.vlm_with_expert.embed_language_tokens(
        #     torch.tensor([special_token_id] * self.config.num_mem_tokens)
        # )
        
        self.mem_tokens = nn.Parameter(mem_tokens, requires_grad=True)
```

### 可视化记忆状态

```python
import matplotlib.pyplot as plt
import seaborn as sns

def visualize_memory_evolution(policy, episode_data):
    """可视化记忆 tokens 在 episode 中的演化"""
    memory_states = []
    
    policy.reset()
    for step_data in episode_data:
        action = policy.select_action(step_data)
        if policy._mem_tokens_state is not None:
            memory_states.append(policy._mem_tokens_state.cpu().numpy())
    
    # 绘制热图
    memory_array = np.array(memory_states)  # [steps, num_mem, batch, hidden]
    memory_norm = np.linalg.norm(memory_array, axis=-1).squeeze()
    
    plt.figure(figsize=(12, 6))
    sns.heatmap(memory_norm.T, cmap='viridis')
    plt.xlabel('Time Step')
    plt.ylabel('Memory Token')
    plt.title('Memory Token Evolution')
    plt.savefig('memory_evolution.png')
```

## 📚 参考资料

- [RMT 论文](https://arxiv.org/abs/2207.06881): Recurrent Memory Transformer
- [SmolVLA 论文](https://huggingface.co/papers/2506.01844)
- [LeRobot 文档](https://huggingface.co/docs/lerobot/index)

## 🤝 贡献

如果你发现问题或有改进建议，欢迎提交 Issue 或 Pull Request。

## 📄 许可证

本项目遵循 Apache 2.0 许可证。
