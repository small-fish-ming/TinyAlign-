import os
import sys


__package__ = "trainer"
sys.path.append(os.path.abspath(os.path.join(os.path.dirname(__file__), "..")))

import argparse  # 命令行参数解析
import time  # 时间统计
import warnings  # 警告控制
import torch  
import torch.distributed as dist  # 分布式训练支持
from contextlib import nullcontext  # 上下文管理器
from torch import optim, nn  # 优化器和神经网络模块
from torch.nn.parallel import DistributedDataParallel  # 分布式数据并行
from torch.utils.data import DataLoader, DistributedSampler  # 数据加载器

from model.model import MokioMindConfig 
from dataset.lm_dataset import PretrainDataset 
from train.trainer_utils import (  # 训练工具函数
    get_lr,
    Logger,
    is_main_process,
    lm_checkpoint,
    init_distributed_mode,
    setup_seed,
    init_model,
    SkipBatchSampler,
)

# 忽略警告信息，保持输出清洁
warnings.filterwarnings("ignore")


def train_epoch(epoch, loader, iters, start_step=0, wandb=None):
    """
    执行单个训练轮次
    实现预训练的核心训练循环
    
    📚 预训练训练循环知识点：
    - 损失函数：交叉熵损失，衡量预测概率与真实label的差异
    - 学习率调度：动态调整学习率，提高训练效果
    - 梯度累积：在小batch上模拟大batch训练效果  
    - 混合精度：使用半精度浮点数加速训练
    - 梯度裁剪：防止梯度爆炸问题
    
    Args:
        epoch: 当前训练轮次
        loader: 数据加载器
        iters: 总迭代次数
        start_step: 起始步数（用于断点续训）
        wandb: 实验跟踪工具
    """
    # 📚 交叉熵损失函数知识点
    # reduction='none': 不对batch维度求平均，保持原始形状
    # 这样可以配合loss_mask进行精确的损失计算
    loss_fct = nn.CrossEntropyLoss(reduction='none')
    start_time = time.time()  # 记录开始时间
    
    # 遍历数据批次
    for step, (X, Y, loss_mask) in enumerate(loader, start=start_step + 1):
        # 📚 数据移动到GPU知识点
        # .to(device): 将tensor移动到指定设备（GPU/CPU）
        # 必须确保模型和数据在同一设备上
        X = X.to(args.device)          # 输入序列 [batch_size, seq_len]
        Y = Y.to(args.device)          # 目标序列 [batch_size, seq_len]  
        loss_mask = loss_mask.to(args.device)  # 损失掩码 [batch_size, seq_len]
        
        # 📚 学习率调度知识点
        # 根据当前步数计算对应的学习率
        # 实现余弦退火调度策略
        lr = get_lr(epoch * iters + step, args.epochs * iters, args.learning_rate)
        
        # 📚 优化器参数组知识点
        # optimizer.param_groups: 包含所有参数组的列表
        # 每个参数组可以有不同的学习率、权重衰减等
        for param_group in optimizer.param_groups:
            param_group['lr'] = lr

        # 📚 混合精度训练知识点
        # autocast_ctx: 自动混合精度上下文管理器
        # 自动选择合适的数据类型（float16/bfloat16/float32）
        with autocast_ctx:
            # 前向传播
            res = model(X)  # 模型输出，包含logits和aux_loss
            
            # 📚 语言模型损失计算知识点
            # logits: [batch_size, seq_len, vocab_size] 
            # Y: [batch_size, seq_len]
            # 需要reshape为2D进行交叉熵计算
            loss = loss_fct(
                res.logits.view(-1, res.logits.size(-1)),  # [batch*seq, vocab_size]
                Y.view(-1)                                 # [batch*seq]
            ).view(Y.size())  # 恢复为 [batch_size, seq_len]

            # 📚 掩码损失计算知识点
            # loss_mask: 标记哪些位置需要计算损失
            # 通常padding位置的mask为0，有效token为1
            loss = (loss * loss_mask).sum() / loss_mask.sum()
            
            # 📚 MoE辅助损失知识点
            # aux_loss: 专家网络的负载均衡损失
            # 确保不同专家被均匀使用
            loss += res.aux_loss
            
            # 📚 梯度累积知识点
            # 将损失除以累积步数，模拟更大的batch size
            # 实际batch_size = batch_size * accumulation_steps
            loss = loss / args.accumulation_steps

        # 📚 混合精度反向传播知识点
        # scaler.scale(): 放大损失值防止梯度下溢
        # .backward(): 计算梯度
        scaler.scale(loss).backward()

        # 📚 梯度累积和更新知识点
        # 每accumulation_steps步才真正更新参数
        if (step + 1) % args.accumulation_steps == 0:
            # scaler.unscale_(): 还原梯度的真实值
            scaler.unscale_(optimizer)
            
            # 📚 梯度裁剪知识点
            # 防止梯度爆炸，稳定训练过程
            # clip_grad_norm_(): 将梯度范数限制在指定阈值内
            torch.nn.utils.clip_grad_norm_(model.parameters(), args.grad_clip)

            # 📚 优化器更新知识点
            # scaler.step(): 执行参数更新
            # scaler.update(): 更新scaler的缩放因子
            scaler.step(optimizer)
            scaler.update()

            # 📚 梯度清零知识点
            # set_to_none=True: 将梯度设为None而不是0，节省内存
            optimizer.zero_grad(set_to_none=True)

        # 📚 日志记录知识点
        # 定期打印训练进度和关键指标
        if step % args.log_interval == 0 or step == iters - 1:
            spend_time = time.time() - start_time
            current_loss = loss.item() * args.accumulation_steps  # 恢复真实损失值
            current_lr = optimizer.param_groups[-1]['lr']         # 当前学习率
            
            # 📚 ETA计算知识点
            # 估算剩余训练时间
            eta_min = spend_time / (step + 1) * iters // 60 - spend_time // 60
            
            Logger(f'Epoch:[{epoch+1}/{args.epochs}]({step}/{iters}) loss:{current_loss:.6f} lr:{current_lr:.12f} epoch_Time:{eta_min}min:')
            
            # 记录到实验跟踪系统
            if wandb: 
                wandb.log({"loss": current_loss, "lr": current_lr, "epoch_Time": eta_min})

        # 📚 模型保存知识点
        # 定期保存检查点，防止训练中断
        if (step % args.save_interval == 0 or step == iters - 1) and is_main_process():
            model.eval()  # 切换到评估模式
            
            # 构建保存路径
            moe_suffix = '_moe' if lm_config.use_moe else ''
            ckp = f'{args.save_dir}/{args.save_weight}_{lm_config.hidden_size}{moe_suffix}.pth'
            
            # 📚 分布式模型保存知识点
            # DDP模型需要通过.module访问真正的模型
            if isinstance(model, torch.nn.parallel.DistributedDataParallel):
                state_dict = model.module.state_dict()
            else:
                state_dict = model.state_dict()
            
            # 📚 半精度保存知识点
            # 将float32参数转为float16，减少存储空间
            state_dict = {k: v.half() for k, v in state_dict.items()}
            torch.save(state_dict, ckp)
            
            # 保存完整训练状态
            lm_checkpoint(lm_config, weight=args.save_weight, model=model, 
                         optimizer=optimizer, scaler=scaler, epoch=epoch, 
                         step=step, wandb=wandb, save_dir='../checkpoints')
            
            model.train()  # 恢复训练模式






if __name__ == "__main__":
    parser = argparse.ArgumentParser(description="MiniMind Pretraining")

    # ========== 基础训练参数 ==========
    parser.add_argument("--save_dir", type=str, default="out", help="模型保存目录")
    parser.add_argument(
        "--save_weight", default="pretrain", type=str, help="保存权重的前缀名"
    )
    parser.add_argument(
        "--epochs", type=int, default=1, help="训练轮数（建议1轮zero或2-6轮充分训练）"
    )
    parser.add_argument("--batch_size", type=int, default=32, help="batch size")
    parser.add_argument("--learning_rate", type=float, default=5e-4, help="初始学习率")

    # ========== 硬件和性能参数 ==========
    parser.add_argument(
        "--device",
        type=str,
        default="cuda:0",
        help="训练设备",
    )
    parser.add_argument("--dtype", type=str, default="bfloat16", help="混合精度类型")
    parser.add_argument("--num_workers", type=int, default=1, help="数据加载线程数")

    # ========== 训练策略参数 ==========
    parser.add_argument(
        "--accumulation_steps", type=int, default=8, help="梯度累积步数"
    )
    parser.add_argument("--grad_clip", type=float, default=1.0, help="梯度裁剪阈值")
    parser.add_argument("--log_interval", type=int, default=100, help="日志打印间隔")
    parser.add_argument("--save_interval", type=int, default=100, help="模型保存间隔")

    # ========== 模型架构参数 ==========
    parser.add_argument("--hidden_size", default=512, type=int, help="隐藏层维度")
    parser.add_argument("--num_hidden_layers", default=8, type=int, help="隐藏层数量")
    parser.add_argument(
        "--max_seq_len", default=512, type=int, help="训练的最大截断长度"
    )
    parser.add_argument(
        "--use_moe",
        default=0,
        type=int,
        choices=[0, 1],
        help="是否使用MoE架构（0=否，1=是）",
    )
    
    # ========== 数据和恢复参数 ==========
    parser.add_argument(
        "--data_path",
        type=str,
        default="minimind/dataset/pretrain_hq.jsonl",
        help="预训练数据路径",
    )
    parser.add_argument(
        "--from_weight",
        default="none",
        type=str,
        help="基于哪个权重训练，为none则从头开始",
    )
    parser.add_argument(
        "--from_resume",
        default=0,
        type=int,
        choices=[0, 1],
        help="是否自动检测&续训（0=否，1=是）",
    )

    # ========== 实验跟踪参数 ==========
    parser.add_argument("--use_wandb", action="store_true", help="是否使用wandb")
    parser.add_argument(
        "--wandb_project", type=str, default="MiniMind-Pretrain", help="wandb项目名"
    )

    # 解析命令行参数
    args = parser.parse_args()

    # ========== 1. 初始化环境和随机种子 ==========
    """
    📚 分布式训练初始化知识点：
    - local_rank: 当前进程在本机上的GPU编号
    - 随机种子: 确保不同进程有不同但可复现的随机序列
    - 这样既保证了随机性，又保证了可复现性
    """
    local_rank = init_distributed_mode()
    if dist.is_initialized():
        args.device = f"cuda:{local_rank}"  # 分布式训练时使用对应的GPU

    # 📚 随机种子设置知识点
    # 不同进程使用不同的种子，避免数据采样完全相同
    # 42是基础种子，每个进程加上自己的rank保证不同
    setup_seed(42 + (dist.get_rank() if dist.is_initialized() else 0))

    # ========== 2. 配置目录、模型参数、检查点 ==========
    """
    📚 模型配置和检查点管理：
    - 创建保存目录
    - 构建模型配置对象
    - 尝试加载断点续训数据
    """
    os.makedirs(args.save_dir, exist_ok=True)  # 确保保存目录存在

    # 创建MiniMind模型配置
    lm_config = MokioMindConfig(
        hidden_size=args.hidden_size, num_hidden_layers=args.num_hidden_layers,use_moe=bool(args.use_moe)
    )

    # 📚 断点续训知识点
    # 如果开启了断点续训，尝试加载之前的训练状态
    ckp_data = (
        lm_checkpoint(lm_config, weight=args.save_weight, save_dir="checkpoints")
        if args.from_resume == 1
        else None
    )

    # ========== 3. 设置混合精度 ==========
    """
    📚 混合精度训练知识点：
    - bfloat16: Google开发，数值范围大，更稳定
    - float16: 标准半精度，节省内存但可能溢出
    - autocast: 自动选择精度，关键运算用float32
    """
    device_type = "cuda" if "cuda" in args.device else "cpu"
    dtype = torch.bfloat16 if args.dtype == "bfloat16" else torch.float16

    # 📚 上下文管理器知识点
    # CPU不支持autocast，使用nullcontext作为空操作
    autocast_ctx = (
        nullcontext() if device_type == "cpu" else torch.cuda.amp.autocast(dtype=dtype)
    )

    # ========== 4. 配置WandB实验跟踪 ==========
    """
    📚 实验跟踪系统知识点：
    - WandB: 实验管理平台，记录训练过程
    - SwanLab: 国产替代方案
    - 支持断点续训时恢复到同一个实验
    """
    wandb = None
    if args.use_wandb and is_main_process():
        # 使用SwanLab作为WandB的替代
        import swanlab as wandb

        # 📚 实验恢复知识点
        # 如果有检查点数据，获取之前的wandb_id来恢复实验
        wandb_id = ckp_data.get("wandb_id") if ckp_data else None
        resume = "must" if wandb_id else None  # 必须恢复到指定实验

        # 构建实验名称，包含关键超参数
        wandb_run_name = f"MiniMind-Pretrain-Epoch-{args.epochs}-BatchSize-{args.batch_size}-LearningRate-{args.learning_rate}"
        wandb.init(
            project=args.wandb_project, name=wandb_run_name, id=wandb_id, resume=resume
        )

    # ========== 5. 定义模型、数据、优化器 ==========
    """
    📚 训练组件初始化：
    - 模型: 根据配置创建MiniMind模型
    - 数据集: 加载预训练数据
    - 采样器: 分布式训练的数据分配
    - 优化器: AdamW优化器
    - 缩放器: 混合精度训练的梯度缩放
    """
    # 初始化模型和分词器
    model, tokenizer = init_model(lm_config, args.from_weight, device=args.device)

    train_ds = PretrainDataset(args.data_path, tokenizer, max_length=args.max_seq_len)

    train_sampler = DistributedSampler(train_ds) if dist.is_initialized() else None

    scaler = torch.cuda.amp.GradScaler(enabled=(args.dtype == "float16"))

    optimizer = optim.AdamW(model.parameters(), lr=args.learning_rate)
    start_epoch, start_step = 0, 0
    print(f"模型设备: {next(model.parameters()).device}")
    if ckp_data:
        # 恢复模型参数
        model.load_state_dict(ckp_data["model"])
        # 恢复优化器状态（动量、方差估计等）
        optimizer.load_state_dict(ckp_data["optimizer"])
        # 恢复梯度缩放器状态
        scaler.load_state_dict(ckp_data["scaler"])
        # 恢复训练进度
        start_epoch = ckp_data["epoch"]
        start_step = ckp_data.get("step", 0)

    if dist.is_initialized():
        # 📚 RoPE位置编码特殊处理
        # freqs_cos, freqs_sin是位置编码缓存，不需要梯度同步
        model._ddp_params_and_buffers_to_ignore = {"freqs_cos", "freqs_sin"}
        model = DistributedDataParallel(model, device_ids=[local_rank])

    for epoch in range(start_epoch, args.epochs):
        # 📚 分布式采样器epoch设置
        # 每个epoch设置不同的随机种子，确保数据顺序随机化
        if train_sampler:
            train_sampler.set_epoch(epoch)

        # 📚 断点续训逻辑
        if epoch == start_epoch and start_step > 0:  # 第一个epoch且存在检查点
            # 使用跳批采样器，跳过已训练的数据
            batch_sampler = SkipBatchSampler(
                train_sampler or range(len(train_ds)), args.batch_size, start_step + 1
            )
            loader = DataLoader(
                train_ds,
                batch_sampler=batch_sampler,
                num_workers=args.num_workers,
                pin_memory=True,
            )
            Logger(
                f"Epoch [{epoch + 1}/{args.epochs}]: 跳过前{start_step}个step，从step {start_step + 1}开始"
            )
            train_epoch(epoch, loader, len(loader) + start_step + 1, start_step, wandb)
        else:  # 默认从头开始
            loader = DataLoader(
                train_ds,
                batch_size=args.batch_size,
                shuffle=(train_sampler is None),
                sampler=train_sampler,
                num_workers=args.num_workers,
                pin_memory=True,
            )
            train_epoch(epoch, loader, len(loader), 0, wandb)








