from TicTacToe import TicTacToe
from State import State
from Human_Agent import Human_Agent
from Random_Agent import Random_Agent
from AI_Agent import AI_Agent

# נתיב לקובץ ה-Q החדש שאימנת עבור שחקן O
PATH = 'Data/Q_Agent_As_O.pth'

env = TicTacToe(State())

# שחקן 1 (X) - נשאר אקראי, כדי לבדוק איך הבוט מתמודד מול שחקן אקראי
player1 = Random_Agent(1, env, graphics=None)

# שחקן 2 (O) - הסוכן החכם שלנו! (train=False דואג שהוא ישחק הכי חכם שהוא יכול)
player2 = AI_Agent(-1, env, graphics=None, Q_table_PATH=PATH, train=False)

num = 1000

def main ():

    x_win = 0
    o_win = 0
    tie = 0
        
    for n in range(num):
        state = State()
        player = player1 # המשחק תמיד מתחיל משחקן 1 (האקראי)
        
        while not env.end_of_game(state):
            action = player.get_action(state=state)
            state, _ = env.next_state(state, action)
            player = switch_players(player)
            
        if state.end_of_game == 1:
            x_win += 1       # ניצחון של השחקן האקראי (X)
        elif state.end_of_game == -1:
            o_win += 1       # ניצחון של הסוכן החכם שלך (O)
        else:
            tie += 1         # תיקו
            
        state.reset()    
        print(n, end = "\r")
        
    print()
    print(f"Tester results after {num} games:")
    print(f"X wins (Random): {x_win}")
    print(f"O wins (Smart Agent): {o_win}")
    print(f"Games ended in a tie: {tie}")

def switch_players(player):
    if player == player1:
        return player2
    else:
        return player1

if __name__ == '__main__':
    main()