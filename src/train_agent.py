import rclpy
from stable_baselines3 import SAC
from stable_baselines3.common.env_checker import check_env
from stable_baselines3.common.callbacks import CheckpointCallback
# 导入你刚刚辛辛苦苦写好的环境！
from rl_env import AutonomousCarEnv

def main():
    print("【系统】正在初始化物理世界与 AI 大脑的连接桥梁...")
    
    # 1. 实例化你的定制环境
    env = AutonomousCarEnv()
    
    # 2. 环境健康检查 (极其重要！)
    # SB3 会用极其严苛的标准，检查你的 reset() 和 step() 输出的格式对不对
    print("【系统】正在对环境进行 Gymnasium 标准化质检...")
    check_env(env)
    print("【系统】质检通过！环境接口完美兼容。")

    # 3. 实例化 SAC 算法大脑
    # "CnnPolicy" 告诉大脑：你的眼睛看到的是图片，请自动启用卷积神经网络。
    # verbose=1 会在终端里打印训练的详细损失率和得分。
    # buffer_size 是经验回放池，因为我们只做轻量级测试，先设为 10000。
    print("【系统】正在唤醒 SAC 深度强化学习神经网络...")
    model = SAC("CnnPolicy", 
                env, 
                verbose=1, 
                buffer_size=10000, 
                learning_starts=100) # 先随机乱开 100 步收集一点初始数据

    # 4. 设置自动保存机制
    # 每训练 2000 步，自动保存一次脑电波 (权重模型)，防止突然断电白跑
    checkpoint_callback = CheckpointCallback(save_freq=2000, save_path='./logs/', name_prefix='sac_car_model')

    # 5. 点火！开始疯狂试错与训练！
    # total_timesteps = 50000 意味着小车要在物理世界里做 5 万次决策
    print("🔥 【系统】点火成功！开始自动化训练循环...")
    try:
        model.learn(total_timesteps=50000, callback=checkpoint_callback)
    except KeyboardInterrupt:
        print("\n【系统】接收到手动中断信号，正在提前结束训练...")
    finally:
        # 6. 训练结束，保存最终的大脑切片
        print("💾 【系统】正在保存最终模型到 sac_autonomous_car.zip...")
        model.save("sac_autonomous_car")
        
        # 优雅关闭环境
        env.close()
        print("【系统】训练程序安全退出。")

if __name__ == '__main__':
    main()
