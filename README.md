# ML-QLearning-CartPole

Este é um projeto de estudo de **Machine Learning** usando **Q-Learning** para resolver o problema do CartPole, utilizando o **Gymnasium**.

---

## 📚 Descrição do Projeto  
O objetivo é treinar um agente para equilibrar um pêndulo em um carrinho utilizando **Q-Learning** com discretização de estados.  
- **Q-Learning:** Algoritmo de aprendizado por reforço baseado em tabela Q.  
- **Discretização de Estados:** Como o CartPole tem estados contínuos (posição, velocidade, ângulo e velocidade angular), foi utilizada discretização para transformar o problema em um espaço discreto de estados.  

---

## 🧰 Tecnologias Utilizadas  
- **Python 3.x**  
- **Gymnasium (OpenAI Gym)**  
- **NumPy**  

---

## ⚙️ Configuração do Ambiente  

1. **Clone o repositório:**
   ```bash
   git clone https://github.com/seu-usuario/ML-QLearning-CartPole.git
   cd ML-QLearning-CartPole
   ```

2. **Crie um ambiente virtual**
    ```bash
    python3 -m venv venv
    ```

3. **Ative o ambiente virtual**
    2.1. No Windows
        ```bash
        venv\Scripts\activate
        ```

    2.2. No Linux
        ```bash
        source venv/bin/activate
        ```

4. **Instale as dependências**
    ```bash
    pip install -r requirements.txt
    ```

5. **Para treinar o agente e jogar**
    ```bash
    python treinar.py
    python jogar.py
    ```
